# 经典架构参考：BDI、SOAR、ACT-R 与包容架构

**TL;DR：** 这四种架构来自经典 AI 和认知科学，比 LLM 早了几十年。BDI 把 Agent 的决策分为信念-愿望-意图三层；SOAR 用产生式规则和状态-操作符循环做通用问题求解；ACT-R 模拟人类认知的模块化处理；包容架构用分层反应替代中央规划。它们不会直接用在 LLM Agent 项目里，但它们的设计思想——分层决策、记忆分类、反应式控制——已经渗透到了现代 Agent 系统的每一层。了解这些架构，能帮你理解"为什么现代 Agent 要这样设计"。

## 为什么要看几十年前的架构

2023 年之后的 Agent 系统几乎都基于 LLM + 工具调用。但很多"新"设计模式其实是在重新发现经典 AI 的老问题：

- ReAct 的 Thought→Action→Observation 循环 ≈ BDI 的"感知-推理-行动"循环
- Plan-and-Solve 的规划器 ≈ SOAR 的 Operator 选择机制
- 四类记忆（工作/情景/语义/程序） ≈ ACT-R 的模块化记忆系统
- 反应式工具调用 ≈ 包容架构的分层反应

区别在于：经典架构用符号规则手工编写，现代 Agent 用 LLM 自动生成。但架构层面的设计问题是一样的——怎么表示状态、怎么做决策、怎么学习。

## BDI：信念-愿望-意图

BDI（Belief-Desire-Intention）来自哲学家 Michael Bratman 的实践推理理论（1987），后来被 Rao 和 Georgeff 在 1995 年形式化为 Agent 架构。它把 Agent 的决策过程分为三层：

```text
Belief（信念）：Agent 对世界的认知
  "用户正在问账单问题"
  "当前余额是 ¥500"
  "数据库连接正常"

Desire（愿望）：Agent 想要达成的目标
  "帮用户解决账单疑问"
  "保持对话礼貌"

Intention（意图）：Agent 承诺执行的计划
  "查询账单历史 → 解释差异 → 提供退款选项"
```

### 决策循环

```text
1. 感知环境 → 更新 Belief
2. 根据 Belief 生成/调整 Desire
3. 从 Desire 中选择 Intention（承诺执行某个计划）
4. 执行 Intention 的下一步
5. 观察结果 → 回到第 1 步
```

### 与现代 Agent 的对应

| BDI 概念 | 现代 Agent 对应 |
|---------|---------------|
| Belief | 系统状态 + RAG 检索结果 + 对话历史 |
| Desire | 用户意图 + 任务目标 |
| Intention | Agent 选定的执行计划（如 ReAct 的行动序列） |
| Plan Library | 工具集 + Few-shot 示例 |
| Commitment | Agent 的停止条件和重试策略 |

### 实际应用

微软的 Travel Assistant Agent 就用了 BDI 思路：Belief 是用户的旅行偏好和预算，Desire 是"规划最优行程"，Intention 是具体的搜索和预订操作。

BDI 的价值不在于直接实现——在现代系统中，LLM 同时承担了 Belief 更新、Desire 生成和 Intention 选择的职责。它的价值在于**分析框架**：当你设计 Agent 时，可以显式区分"Agent 知道什么"（Belief）、"Agent 想要什么"（Desire）、"Agent 打算做什么"（Intention），避免三者混淆。

## SOAR：状态-操作符-结果循环

SOAR（State, Operator, And Result）由 John Laird、Allen Newell 和 Paul Rosenbloom 在 1980 年代开发，是最长寿的认知架构之一。它用符号化的产生式规则做通用问题求解。

### 核心机制

```text
工作记忆（Working Memory）
  当前状态的事实和目标
  ↓
产生式规则（Production Rules）
  IF 条件 THEN 动作
  ↓
操作符选择（Operator Selection）
  选择当前最优操作符执行
  ↓
状态更新（State Update）
  应用操作符，更新工作记忆
  ↓
如果遇到僵局（Impasse）→ 子目标（Subgoal）
```

SOAR 的核心洞见是**僵局驱动的学习**：当 Agent 无法选择操作符时（多个候选冲突，或没有候选），它创建子目标来解决这个问题，解决后将经验存入长期记忆。这类似于 Reflexion 模式——遇到困难时反思，把反思结果存入记忆供下次使用。

### 与现代 Agent 的对应

| SOAR 概念 | 现代 Agent 对应 |
|-----------|---------------|
| Working Memory | 上下文窗口（Context Window） |
| Production Rules | System Prompt + 工具定义 |
| Operator Selection | LLM 的工具选择（Function Calling） |
| Impasse → Subgoal | Agent 遇到困难时创建子任务 |
| Chunking（学习机制） | Reflexion 的经验存储 |
| Episodic Memory | Agent 的情景记忆 |

### 对 LLM Agent 的启发

SOAR 的"僵局驱动学习"在 Agent 设计中特别有用：不是所有问题都能一步解决，当 Agent 卡住时，与其反复重试（常见的 Agent 失败模式），不如创建子目标、分析卡住的原因、学习新策略。Reflexion 模式的灵感来源正是这个思想。

## ACT-R：模块化认知

ACT-R（Adaptive Control of Thought-Rational）由 John Anderson 开发，目标是精确模拟人类认知过程。它通过脑成像实验验证模型预测，是认知科学中实证基础最扎实的架构。

### 模块化设计

```text
Declarative Module（陈述性记忆）
  → 事实性知识："巴黎是法国首都"
  → 基于激活值的检索，越常用越容易记起

Procedural Module（程序性记忆）
  → 技能和规则："IF 看到 × THEN 做乘法"
  → 产生式规则，匹配+执行

Buffer System（缓冲区系统）
  → 每个模块通过有限容量的 buffer 与中央系统交互
  → 类似人类的"工作记忆"瓶颈（Miller's Law: 7±2）
```

### 与 Agent 记忆系统的对应

在[记忆与反思章节](04-memory-reflection-multi-agent.md)中讨论的四类记忆，可以直接映射到 ACT-R：

| Agent 记忆类型 | ACT-R 模块 | 特点 |
|--------------|-----------|------|
| 工作记忆 | Buffer System | 容量有限，当前活跃信息 |
| 情景记忆 | Episodic Module | 具体事件的时序记录 |
| 语义记忆 | Declarative Module | 通用知识和事实 |
| 程序记忆 | Procedural Module | 技能和规则 |

### 关键启发：Buffer 容量限制

ACT-R 的 Buffer 只有有限容量——这直接对应 LLM 的上下文窗口限制。ACT-R 的解决方案是"按需检索"：不是把所有记忆塞进 Buffer，而是根据当前任务激活最相关的记忆。

这和现代 Agent 的 Context Engineering（[组合与上下文章节](14-agents-as-tools-context-engineering.md)）完全一致：上下文窗口有限，不能什么都放进去，要按相关性筛选和排序。

## 包容架构：分层反应替代中央规划

包容架构（Subsumption Architecture）由 Rodney Brooks 在 1986 年提出，最初用于移动机器人。它的核心观点是：**不需要中央规划器**。智能行为可以通过多个简单的、独立的反应层叠加实现。

### 分层结构

```text
第 3 层：探索行为（最高层）
  "前方没障碍时，随机选择方向探索"
  ↓ 可以覆盖第 2 层的决策
第 2 层：避障行为
  "前方有障碍时，转向"
  ↓ 可以覆盖第 1 层的决策
第 1 层：移动行为（最底层）
  "持续前进"
```

关键原则：
- **底层优先**：第 1 层始终运行，高层只能覆盖（subsume）低层的输出
- **独立运行**：每层独立感知和反应，不需要等高层决策
- **无中央规划**：没有统一的"大脑"做全局规划

### 与现代 Agent 的对应

包容架构的思想在现代 Agent 中体现为**分层护栏（Layered Guardrails）**：

```text
第 3 层：任务逻辑（最高层）
  "根据用户意图执行复杂操作"
  ↓
第 2 层：安全检查
  "检查操作是否安全"
  ↓ 可以拦截不安全的操作
第 1 层：基础响应（最底层）
  "始终可以回复'我不确定'"
```

Roomba 扫地机器人就是包容架构的直接应用：底层是"前进"，中层是"碰壁转向"，高层是"沿墙清扫"。不需要复杂的路径规划，三层反应叠加就足够实用。

### 启发：不一定需要复杂规划

很多 Agent 项目过度设计——上来就做复杂的多步规划。包容架构提醒我们：简单的反应式行为叠加，有时比中央规划更鲁棒。特别是在不确定环境中，快速反应比完美规划更有价值。

## 经典 vs 现代：不是替代，是融合

| 维度 | 经典架构 | 现代 LLM Agent |
|------|---------|--------------|
| 知识表示 | 手工编码的符号规则 | LLM 的参数化知识 + RAG |
| 决策方式 | 规则匹配 / 搜索 | LLM 推理 + Function Calling |
| 学习方式 | 符号学习（Chunking） | Prompt Engineering + 微调 |
| 适用范围 | 窄领域、高确定性 | 宽领域、高灵活性 |
| 可解释性 | 高（规则可追踪） | 低（神经网络黑盒） |

经典架构的硬编码规则在现代系统中被 LLM 的隐式推理替代了。但架构层面的设计问题没变：怎么组织记忆、怎么处理冲突、怎么在不确定性下做决策。这些是经典架构留给现代 Agent 设计的遗产。

## 延伸阅读

- [BDI 原始论文](https://doi.org/10.1109/5259.1993.624971) — Rao & Georgeff, 1995，BDI 形式化
- [SOAR 官方网站](https://soar.eecs.umich.edu/) — John Laird 团队维护，包含最新文档和教程
- [ACT-R 官方网站](http://act-r.psy.cmu.edu/) — Carnegie Mellon，包含教程和软件
- [A Robust Layered Control System for a Mobile Robot](https://people.csail.mit.edu/brooks/papers/AIM-864.pdf) — Brooks, 1986，包容架构原始论文
- [From SOAR to ChatGPT: A Cognitive Architecture Perspective](https://arxiv.org/abs/2304.0...) — SOAR 与 LLM 的对比分析
