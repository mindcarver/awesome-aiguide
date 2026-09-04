# 角色化协作：Crew 模式

**TL;DR：** Crew 模式源自 CrewAI 框架，核心思想是给每个 Agent 分配角色（Role）、目标（Goal）和背景故事（Backstory），让多 Agent 协作像一支有明确分工的团队。与 Swarm/Handoff 的"接力"不同，Crew 模式更强调"角色定义驱动行为"——Agent 的行为不仅由工具决定，还由它的身份和目标塑造。适合需要多人协作的复杂任务，但角色定义的质量直接决定输出质量。

## 它解决什么失控点

[多智能体章节](04-memory-reflection-multi-agent.md)讨论了三种协作结构：主从、审查和市场。[Swarm/Handoff 章节](13-swarm-handoff-debate.md)讨论了轻量级路由。这些模式解决的是"谁做什么"和"怎么交接"。

Crew 模式解决的是一个更前置的问题：**Agent 的行为如何被角色定义塑造**。在 Swarm 中，Agent 之间的差异主要是工具集和 handoff 规则。在 Crew 模式中，差异来自角色的身份——一个"资深技术架构师"和一个"初级前端开发者"，即使拥有相同工具，行为方式也不同。

这不是纯粹的工程问题——它涉及 prompt 设计的核心：如何通过角色定义引导 LLM 的输出风格、推理深度和决策偏好。

## 核心概念：Role → Goal → Backstory

CrewAI 框架（2023 年开源）把 Agent 定义为三个要素的组合：

```python
from crewai import Agent, Task, Crew

researcher = Agent(
    role="高级市场研究员",
    goal="发现关于 {topic} 的突破性洞察和趋势",
    backstory=(
        "你曾在麦肯锡担任高级分析师 10 年。"
        "你擅长从大量信息中提取关键洞察，"
        "你的报告总是以数据驱动，从不做无根据的断言。"
    ),
    tools=[search_tool, scrape_tool],
    verbose=True,
)

writer = Agent(
    role="技术内容总监",
    goal="将复杂技术概念转化为引人入胜的内容",
    backstory=(
        "你是一位前 Wired 杂志的资深编辑。"
        "你知道如何让技术内容既准确又有趣，"
        "你从不使用'在当今快速发展的世界中'这类废话。"
    ),
    tools=[write_tool],
    verbose=True,
)
```

### 为什么需要 Backstory

一个常见的疑问是：为什么不能只给 Agent 一个简短的 role？

因为 LLM 的行为受 prompt 中的身份描述影响很大。一个只被告知"你是研究员"的 Agent，倾向于给出泛泛的总结。一个被告知"你曾在麦肯锡担任高级分析师 10 年"的 Agent，倾向于给出结构化的、数据驱动的洞察。

这不是魔法——是因为 Backstory 中的细节触发了 LLM 训练数据中对应的行为模式。"麦肯锡分析师"的表述让模型联想到结构化分析、数据驱动、MECE 原则等训练时见过的内容。

Backstory 的设计原则：
- **具体而非抽象**："10 年数据分析经验"比"经验丰富"更有效
- **定义风格而非内容**："从不做无根据的断言"比"要准确"更有引导力
- **设定边界**："你只关注技术可行性"限制 Agent 不跑偏

## 任务编排：Sequential vs Hierarchical

Crew 模式的任务编排有两种方式：

### 顺序执行（Sequential）

```python
# 顺序执行：研究 → 写作 → 审核
research_task = Task(
    description="调研 {topic} 的最新趋势和关键数据",
    agent=researcher,
    expected_output="包含 5-10 个关键洞察的结构化报告",
)

write_task = Task(
    description="基于调研结果撰写一篇 2000 字的技术文章",
    agent=writer,
    expected_output="可直接发布的技术文章",
)

review_task = Task(
    description="审查文章的准确性和可读性",
    agent=reviewer,
    expected_output="审查意见和修改建议",
)

crew = Crew(
    agents=[researcher, writer, reviewer],
    tasks=[research_task, write_task, review_task],
    process="sequential",  # 顺序执行
)

result = crew.kickoff(inputs={"topic": "AI Agent 设计模式"})
```

每个 Task 的输出自动传递给下一个 Task。Agent 拿到前一个 Agent 的输出作为输入。

### 层级执行（Hierarchical）

```python
# 层级执行：有一个"经理"Agent 负责分配任务
crew = Crew(
    agents=[researcher, writer, coder, designer],
    tasks=[research_task, write_task, code_task, design_task],
    process="hierarchical",  # 层级执行
    manager_llm=ChatOpenAI(model="gpt-4o"),
    # manager_llm 会自动创建一个"经理"Agent 来分配和协调任务
)
```

层级模式下，经理 Agent 负责：
- 理解整体任务目标
- 决定哪些 Agent 做哪些任务
- 在 Agent 之间分配和重新分配工作
- 综合所有 Agent 的输出

这类似于[多智能体章节](04-memory-reflection-multi-agent.md)中的主从模式，但经理 Agent 是 LLM 驱动的，不是硬编码的路由逻辑。

### 两种模式的对比

| 维度 | Sequential | Hierarchical |
|------|-----------|--------------|
| 控制流 | 固定顺序 | 经理动态决策 |
| 灵活性 | 低（流程预定义） | 高（经理可调整） |
| 成本 | N 次 LLM 调用 | N + M 次（M = 经理决策次数） |
| 可预测性 | 高 | 中 |
| 适用 | 流程固定的任务 | 需要动态协调的任务 |

## Crew 模式与 Swarm 的区别

```text
Swarm/Handoff:
  用户 → Agent A → handoff → Agent B → 回复用户
  （接力模式，对话在 Agent 之间传递）

Crew 模式:
  用户 → 任务 → [Agent A → Agent B → Agent C] → 回复用户
  （团队模式，用户只看到最终结果）
```

关键区别：

| 维度 | Swarm/Handoff | Crew 模式 |
|------|--------------|-----------|
| 用户感知 | 可能感知 Agent 切换 | 只看到最终结果 |
| 核心驱动 | handoff 规则 | 角色定义 |
| 任务粒度 | 每次处理一个请求 | 一次启动整个工作流 |
| 适用场景 | 客服、分领域问答 | 报告生成、项目交付 |
| 灵感来源 | 接力赛 | 项目团队 |

选择原则：如果用户需要实时交互和感知不同专家的存在，用 Swarm；如果是"提交任务，等结果"的批量工作流，用 Crew。

## 工程考量

### 角色定义的投入产出比

角色定义是 Crew 模式的核心投入。一个好角色需要 3-5 轮迭代才能打磨出来：

1. **v1**：写一个基本角色（"你是研究员"）
2. **v2**：加上具体经验和风格（"10 年麦肯锡经验"）
3. **v3**：加上边界和反面约束（"不做无根据断言"）
4. **v4**：用实际任务测试，根据输出调整措辞
5. **v5**：固化，加入项目的角色模板库

角色定义不精确的信号：
- Agent 的输出风格不稳定（时而简洁时而啰嗦）
- Agent 使用了不该用的工具（"研究员"开始写代码）
- 两个 Agent 的输出风格趋同（角色没有区分度）

### 工具与角色的匹配

每个 Agent 的工具集应该与角色严格匹配：

```python
# 好的工具匹配
researcher = Agent(
    role="市场研究员",
    tools=[web_search, scrape_website, analyze_data],  # 研究工具
)
writer = Agent(
    role="内容编辑",
    tools=[write_document, edit_document],  # 写作工具
)

# 坏的工具匹配
researcher = Agent(
    role="市场研究员",
    tools=[web_search, write_document, send_email, execute_code],  # 太多无关工具
)
```

工具不匹配会导致 Agent 越权——研究员开始写文章、编辑开始做调研。这和[反模式章节](16-anti-patterns-seven-pitfalls.md)中的"God Agent"问题本质相同。

### 内存和知识共享

Crew 模式中的 Agent 默认不共享记忆——每个 Agent 的上下文是独立的。如果需要共享：

```python
# 共享短期记忆
from crewai import Crew

crew = Crew(
    agents=[researcher, writer],
    tasks=[research_task, write_task],
    memory=True,  # 启用共享记忆
)
```

但共享记忆有风险——研究员的原始笔记可能包含噪音（搜索结果的原始 HTML、不相关的段落），这些噪音会污染写作者的上文。推荐做法：在 Task 的 `expected_output` 中定义清晰的输出格式，让前一个 Agent 的输出对后一个 Agent 有用。

## 适用场景

**适合**：
- 需要多角色协作的内容生产（调研 → 写作 → 审查 → 发布）
- 软件开发流水线（需求分析 → 架构设计 → 编码 → 测试 → 部署）
- 任何有固定流程的多步骤任务

**不适合**：
- 简单的问答任务（单 Agent 足够）
- 需要实时交互的场景（Crew 更适合批量任务）
- 角色定义不清晰的任务（如果说不清"谁负责什么"，Crew 模式只会增加混乱）

## 基准数据：CrewAI vs 其他多 Agent 框架

AIMultiple 对 5 个多 Agent 框架的 750 次基准测试（GPT-5.2, temperature=0.0）：

| 框架 | 简单任务 | 中等任务 | 复杂任务 | Token 消耗 |
|------|---------|---------|---------|-----------|
| **CrewAI** | 高准确率 | 高准确率 | 高准确率（维持） | **1.35M tokens**（指数增长） |
| Swarm | 84% | 22% | **0%** | 低 |
| AutoGen | 中等 | 中等 | 中等 | 56.7K |
| LangChain | 稳定 | 稳定 | 稳定 | 13.5K |
| LangGraph | 稳定 | 稳定 | 稳定 | 13.6K |

关键发现：CrewAI 准确率最稳定，但 Token 消耗随任务复杂度呈**指数增长**。Swarm 因无状态架构，复杂任务准确率从 84% 直接崩塌到 0%。CrewAI 已在产线处理超过 17 亿个工作流，DocuSign 等企业在使用。

## 延伸阅读

- [CrewAI 官方文档](https://docs.crewai.com/) — Crew 框架的完整使用指南
- [Building Effective Agents - Anthropic](https://www.anthropic.com/engineering/building-effective-agents) — Anthropic 对多 Agent 协作的工程建议
- [MetaGPT: Multi-Agent Framework](https://arxiv.org/abs/2308.00352) — 另一个角色化多 Agent 框架，用 SOP（标准操作流程）组织 Agent
- [ChatDev: Communicative Agents for Software Development](https://arxiv.org/abs/2307.07924) — 用角色化 Agent 模拟软件公司
- [AutoGen: Multi-Agent Conversation Framework](https://arxiv.org/abs/2308.08155) — Microsoft 的多 Agent 对话框架
