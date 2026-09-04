# 协作与对抗：Swarm/Handoff 与 Debate

**TL;DR：** Swarm/Handoff 用轻量级路由替代中央控制器——每个 Agent 只管自己的事，需要时通过 handoff 把对话交给下一个 Agent，实现成本极低。Debate 模式让多个 Agent 对同一问题给出不同视角，通过辩论或投票达成更好的结论。实际经验表明：协作型 Debate（各 Agent 补充不同信息）比对抗型 Debate（互相攻击）效果更好。两者解决不同问题：Swarm 解决"谁来处理"的路由效率，Debate 解决"一个人不够"的判断质量。

## 它解决什么失控点

### Swarm/Handoff：多 Agent 路由的复杂度失控

前面[多智能体章节](04-memory-reflection-multi-agent.md)讨论了三种协作结构：主从、审查和市场。这些结构都需要一个"谁来处理这个请求"的路由机制。主从模式由主 Agent 决定，市场模式由 Agent 自荐。

Swarm/Handoff 解决的是**路由的工程复杂度**：不需要中央路由器，每个 Agent 定义自己"在什么条件下交给谁"。这是一种去中心化的路由方式——像接力赛，每个跑者跑到自己的终点就交棒。

### Debate：单一视角的判断失控

单个 Agent 无论多强大，总有盲区——可能是知识盲区（不了解某个领域），也可能是推理盲区（陷入了某种思维定式）。Debate 模式通过引入多个视角来弥补。

Debate 解决的是**单 Agent 的认知盲区**：让多个 Agent 从不同角度分析同一个问题，通过辩论、交叉审查或投票，综合出一个更可靠的结论。

## Swarm/Handoff：轻量级多 Agent 路由

Swarm 是 OpenAI 在 2024 年开源的实验性多 Agent 框架，核心概念只有两个：**Agent**（包含指令和工具）和 **Handoff**（把对话交给另一个 Agent）。OpenAI 的 Agents SDK 后来正式采用了这个模式。

### 核心概念

```python
# Swarm 的 Agent 定义（基于 OpenAI Agents SDK）
from agents import Agent, Runner

triage_agent = Agent(
    name="分流助手",
    instructions="判断用户的需求类型，交给对应的专家",
    handoffs=[
        {"target": "billing_agent", "description": "处理账单和支付问题"},
        {"target": "tech_agent", "description": "处理技术支持问题"},
        {"target": "sales_agent", "description": "处理销售和产品咨询"},
    ],
)

billing_agent = Agent(
    name="账单专家",
    instructions="处理账单相关的问题。如果用户问非账单问题，交给分流助手。",
    tools=[query_billing_db, process_refund],
    handoffs=[{"target": "triage_agent"}],
)

tech_agent = Agent(
    name="技术支持",
    instructions="处理技术问题。复杂 bug 可以升级给高级工程师。",
    tools=[search_knowledge_base, create_ticket],
    handoffs=[
        {"target": "triage_agent"},
        {"target": "senior_engineer_agent"},
    ],
)
```

### Handoff 的执行流程

```text
用户: "我上个月被多扣了钱"

1. triage_agent 分析 → 判断是账单问题
2. handoff → billing_agent 接手
3. billing_agent 调用 query_billing_db → 找到账单记录
4. billing_agent 调用 process_refund → 处理退款
5. billing_agent 回复用户

（如果 billing_agent 发现是技术问题导致的计费错误）
6. handoff → tech_agent 接手处理技术问题
```

Handoff 不是"创建新对话"，而是**同一个对话的接力**。对话历史完整传递给下一个 Agent，所以新 Agent 知道之前的上下文。

### 与中央路由的对比

| 维度 | 中央路由（Router Agent） | Swarm/Handoff |
|------|------------------------|---------------|
| 路由决策 | 专门的 Router Agent 判断 | 每个 Agent 自己判断 |
| 添加新 Agent | 需要更新 Router 的路由表 | 只需在新 Agent 上加 handoff |
| 扩展性 | Router 是瓶颈 | 无单点瓶颈 |
| 可预测性 | 高（路由逻辑集中） | 中（路由分散在各 Agent） |
| 调试难度 | 低（看 Router 决策） | 高（需要追踪 handoff 链） |

### 适用场景

**适合**：客服系统、分领域工作流——不同类型的问题由不同专家处理，且问题类型可以提前分类。

**不适合**：需要全局协调的复杂任务。比如"做一个产品发布计划"需要市场、技术、设计多方协同，不是简单的接力能搞定的，应该用[多智能体章节](04-memory-reflection-multi-agent.md)中的主从或审查结构。

## Debate：多视角的碰撞

Debate 模式的核心假设是：**多个独立视角的碰撞，比单一视角更接近真相**。有两种主流实现：

### 协作型 Debate（更推荐）

多个 Agent 各自从不同角度分析同一个问题，互相补充而非攻击。

```python
# 协作型 Debate 示意
analyst_a = Agent(
    role="乐观分析师",
    instructions="从积极面分析这个方案的可行性和收益",
)

analyst_b = Agent(
    role="风险分析师",
    instructions="从风险面分析这个方案的潜在问题和成本",
)

analyst_c = Agent(
    role="中立裁判",
    instructions="综合两位分析师的观点，给出平衡的建议",
)

def collaborative_debate(question, rounds=2):
    perspectives = []

    # 每个分析师给出初始观点
    view_a = analyst_a.invoke(question)
    view_b = analyst_b.invoke(question)
    perspectives.extend([view_a, view_b])

    # 多轮交叉补充
    for _ in range(rounds):
        view_a = analyst_a.invoke(
            f"这是对手的观点：{view_b}\n请补充你的分析或修正你的观点"
        )
        view_b = analyst_b.invoke(
            f"这是对手的观点：{view_a}\n请补充你的分析或修正你的观点"
        )

    # 裁判综合
    final = analyst_c.invoke(
        f"方案：{question}\n分析师A：{view_a}\n分析师B：{view_b}\n"
        f"请给出综合建议。"
    )
    return final
```

### 对抗型 Debate（MAD）

Multi-Agent Debate（MAD）出自论文 *Encouraging Divergent Thinking in Large Language Models through Multi-Agent Debate*（Liang et al., 2023）。Agent 之间互相质疑和反驳：

```text
Agent A: 方案 X 更好，因为...
Agent B: 我不同意，方案 X 的问题是...
Agent A: 你说的有道理，但方案 Y 的缺点更严重...
Agent B: 好吧，我修正我的观点...
```

### 哪种更好

实践表明**协作型通常优于对抗型**：

- **协作型**更高效——Agent 互相补充信息，收敛快。适合需要综合多领域知识的任务。
- **对抗型**容易陷入"为反对而反对"的死循环，或者 Agent 过早妥协（"你说得对"然后放弃自己的合理观点）。
- **投票型**（多个 Agent 独立回答，取多数）是最简单的 Debate 变体。适合有明确正确答案的任务（如代码审查中的 bug 判断）。

Anthropic 的工程实践建议：与其让 Agent 互相辩论，不如让它们各自独立分析，然后由一个综合 Agent 汇总。这避免了对抗型 Debate 的"态度通胀"问题。

### 成本考量

Debate 的成本是单 Agent 的 N 倍（N = 参与辩论的 Agent 数量）× R 倍（R = 辩论轮数）。3 个 Agent 辩论 2 轮 = 6 次调用 + 1 次综合 = 7 次调用。

实用建议：
- **高价值决策**（架构评审、安全审计）→ 值得用 Debate
- **批量处理**（客服回复、日常查询）→ 单 Agent 就够
- **中间地带** → 用"多 Agent 独立回答 + 投票"，成本只有 N 倍，没有多轮交互

## Agents-as-Tools：让 Agent 成为工具

Debate 和 Swarm 都涉及多个 Agent。一个自然的想法是：能不能让一个 Agent 调用另一个 Agent，就像调用工具一样？

这就是 **Agents-as-Tools** 模式。OpenAI Agents SDK 通过 `as_tool()` 方法直接支持：

```python
from agents import Agent, Runner

# 专家 Agent
research_agent = Agent(
    name="研究员",
    instructions="对给定主题做深度调研，返回结构化报告",
    tools=[web_search, read_document],
)

# 把专家 Agent 包装成工具
research_tool = research_agent.as_tool(
    name="deep_research",
    description="对给定主题做深度调研，返回结构化报告",
)

# 主 Agent 可以像调用普通工具一样调用专家 Agent
coordinator = Agent(
    name="协调者",
    instructions="根据用户需求分配给专家处理",
    tools=[research_tool, writing_tool, coding_tool],
)
```

### 与 Swarm/Handoff 的区别

```text
Swarm/Handoff: 对话接力，同一对话流中切换 Agent
               用户 → AgentA → handoff → AgentB → 回复用户

Agents-as-Tools: 嵌套调用，一个 Agent 在内部调用另一个 Agent
                 用户 → AgentA → 调用 AgentB（作为工具）→ 结果回到 AgentA → 回复用户
```

关键区别：
- **Swarm**：用户看到的是多个 Agent 之间的无缝切换
- **Agents-as-Tools**：用户只看到主 Agent，底层 Agent 是透明的

选择原则：如果用户需要感知不同专家的存在（比如客服系统的分部门转接），用 Swarm；如果只是内部调用（比如主 Agent 调用研究 Agent 查资料），用 Agents-as-Tools。

## 工程考量

### Handoff 链的深度

Swarm 中可能出现 handoff 链过长的问题：A 交给 B，B 交给 C，C 又交给 A...。必须设置：

```python
# 限制 handoff 深度
MAX_HANDOFF_DEPTH = 5

def run_with_depth_limit(agents, initial_input):
    current_agent = agents[0]
    input_data = initial_input
    depth = 0

    while depth < MAX_HANDOFF_DEPTH:
        result = current_agent.invoke(input_data)
        if result.handoff:
            current_agent = result.handoff_target
            input_data = result.conversation_history
            depth += 1
        else:
            return result

    return {"error": "handoff 次数超过限制，请人工介入"}
```

### Debate 的收敛条件

多轮 Debate 需要收敛条件，否则 Agent 可能无限辩论：

1. **最大轮数**：通常 2-3 轮足够。超过后强制由裁判综合。
2. **共识检测**：如果 Agent 们的观点已经趋同，提前结束。
3. **时间限制**：超过预算时间，用当前最佳答案。

### 幻觉传染

在 Debate 和多 Agent 场景中，一个 Agent 的幻觉可能被其他 Agent 当作事实引用，形成"幻觉传染"。缓解方式：

- 要求每个 Agent 引用来源（类似 [RAG 章节](03-external-world-tools-mcp-knowledge-retrieval.md)中的引用机制）
- 裁判 Agent 在综合时交叉验证关键事实
- 对高不确定性结论标注置信度

## 延伸阅读

- [OpenAI Swarm GitHub](https://github.com/openai/swarm) — 轻量级多 Agent 框架，Handoff 模式的参考实现
- [OpenAI Agents SDK](https://github.com/openai/openai-agents-python) — 正式版 SDK，包含 `as_tool()` 和 handoff
- [Multi-Agent Debate (MAD)](https://arxiv.org/abs/2305.14325) — 对抗型多 Agent 辩论的学术研究
- [Building Effective Agents - Anthropic](https://www.anthropic.com/engineering/building-effective-agents) — 协作优于对抗的工程经验
- [Improving Factuality with Multi-Agent Debate](https://arxiv.org/abs/2305.14325) — 多 Agent 辩论提升事实准确性的基准数据
