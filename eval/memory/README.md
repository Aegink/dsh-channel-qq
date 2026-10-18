# 记忆评测（60 题基准）· P6e·e4

用**服务器上的真实日记**构建的 60 题基准，考记忆系统的检索侧：召回、延迟、注入预算。
规格见 [09 §9](../../refactor-plan/09-记忆系统设计.md)；跑分结果与诊断见
[阶段完成记录 §11](../../refactor-plan/11-阶段完成记录.md)。

## 怎么跑

```bash
# 1) 备语料（不进仓库：里面是真实聊天内容）
#    从服务器拉工作区的 memory/ 到本地缓存：
mkdir -p eval/memory/.cache
#    本地有服务器访问时用 SFTP 拉；或在服务器上直接对着工作区跑（见下）
scp -r <server>:/path/to/workspace/memory eval/memory/.cache/memory

# 2) 跑分
node eval/memory/run.mjs              # 人读报告
node eval/memory/run.mjs --json       # 机读
node eval/memory/run.mjs --corpus /path/to/workspace/memory   # 在服务器上直接跑
node eval/memory/run.mjs --enforce    # 把 09 §9.2 的门槛当 FAIL（退出码 1）

# 3) 也可以从顶层评测器调起（缺语料时记 SKIP，不挡别的套件）
node eval/run.mjs --suite memory
```

**需要编译产物**：`run.mjs` / `corpus.mjs` import 的是 `lib/`（`npm run build`）——
这是 `eval/` 里唯一的例外（其它套件刻意在无构建产物的机器上也能跑）。理由：
这里要测的正是**系统里那一份检索逻辑**，抄一份到 eval 就会与产品漂移。

## 文件

```
eval/memory/
├─ README.md        # 本文件
├─ questions.json   # 60 题（能力分布见下）+ 每题的标准答案与依据锚点
├─ corpus.mjs       # 真实日记 → 记录（句子级切分；纯函数 splitDiary 可单测）
├─ run.mjs          # 跑分（召回/延迟/注入）与报告
└─ .cache/          # 语料缓存（**不进 git**，见根 .gitignore）
```

## 题目字段

```jsonc
{
  "id": "m-0003",
  "ability": "extraction | cross-session | temporal | update | refusal",
  "question": "学弟为什么不愿意把面板关掉？",
  "answer": "他要从外网用面板——原话「没事，开着吧，关了我进不去」",
  "evidence": { "file": "2026-10-16.md", "line": 716 }   // refusal 题为 null
}
```

`line` 是**日记文件里的行号**（通常是那一轮的标题行）。命中判据 = 检索出来的记录
所覆盖的行号区间包含它（区间怎么来的见 `corpus.mjs` 的 `splitDiary`）。

## 能力分布（09 §9.1）

| ability | 题量 | 考什么 |
|---|---|---|
| `extraction` 信息抽取 | 15 | 单一事实能不能找回来（"面板当时监听在哪"） |
| `cross-session` 跨会话推理 | 15 | 一件事跨多轮/多天的来龙去脉 |
| `temporal` 时间推理 | 10 | 什么时候发生、隔了多久 |
| `update` 知识更新 | 10 | 结论被改口之后，记的是新的还是旧的 |
| `refusal` 知道就说不知道 | 10 | 历史里没有的信息（**正确行为是说不知道**） |

## 指标与门槛（09 §9.2）

| 指标 | 门槛 | 谁来算 |
|---|---|---|
| 召回 recall@8 | ≥ 0.85 | `run.mjs`（依据锚点是否落在注入集合里） |
| 端到端答题准确率 | ≥ 0.80 | **需要 LLM 裁判**（未配置时报告标 SKIP） |
| 幻觉率 | ≤ 0.05 | 同上；拒绝题暂时只能用"检索为空"当代理指标 |
| 检索延迟 p95 | ≤ 300ms（本机） | `run.mjs` |
| 每回合注入字符 | ≤ 600 | `run.mjs` |
| 活跃记忆条数 | ≤ 20,000 | `run.mjs` 报告记录数 |

## 首轮基线（2026-10-17，本地，**未启用向量**）

```
recall@8 = 0.04（2/50）· 拒答代理 0/10 · p95 4.8ms · 注入最大 211 字 · 3145 条记录
```

**远低于门槛，原因已定位**（不是"再调调权重"能解决的）：

1. **语料是原始日记的句子，不是抽取后的"一句话事实"**。系统真实检索的记录来自
   抽取器（"学弟要求保留面板外网访问"），措辞更贴近提问；日记原文写的是
   "他说「没事，开着吧」"——**字面几乎不重合**。基准没跑抽取管线（那要模型 + 网络），
   所以这条基准测的是**下界**。
2. **字面匹配跨不过同义/上下位**。问"面板关掉"，答案记录里没有"面板"和"关掉"。
   这正是 09 §10 里"纯关键词会失败"那条，解法是**向量**——e2 已经实现（本机
   embed 服务未安装，`memory.vectorEnabled` 默认关）。
3. 顺带实测出来的两条**真实产品改进**（已落地）：中文问句的虚词二元组会把真关键词
   淹掉（`queryTerms` 加停用字）、库里不存在的查询词只稀释分母（`MemoryStore.keepKnown`）、
   "命中一个罕见词"与"命中一个高频词"不该同分（`MemoryStore.idfOf` + `keywordRelevance`
   的可选 IDF 参数）。这三条把**排序**修对了，但补不上 1 与 2 的鸿沟。

**结论**：`memory.v2` **保持默认关**（09 §9.2 的"达标后默认开"没有满足）。
下一步：embed 服务上机 → `vectorEnabled` 打开 → 用同一份 60 题复测。
