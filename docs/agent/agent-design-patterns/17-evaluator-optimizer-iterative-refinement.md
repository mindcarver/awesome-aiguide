# 评估与精炼：Evaluator-Optimizer 与 Iterative Refinement

**TL;DR：** Evaluator-Optimizer 让一个 LLM 生成、另一个 LLM 评估，循环迭代直到质量达标——Anthropic 把它列为 2024 年最实用的 Agent 模式之一。Iterative Refinement 是它的泛化：不只限于"生成-评估"双 Agent，还可以是单 Agent 的多轮自我改进。Self-Refine 论文显示，GPT-4 在代码生成上经过 3 轮自我精炼后，pass@1 从 67% 提升到 82%。核心 trade-off：每多一轮精炼就多一次 LLM 调用，3 轮意味着 3 倍成本。

## 它解决什么失控点

### Evaluator-Optimizer：生成质量的不可控

LLM 生成的内容质量不稳定——同样的 prompt，可能一次输出 90 分，下次 60 分。如果任务对输出质量有明确标准（如代码必须通过测试、翻译必须准确、报告必须包含特定要素），单次生成不够可靠。

Evaluator-Optimizer 解决的是**生成质量的验证缺口**：不让生成者自己判断"够好了"，而是引入独立的评估者，用明确标准打分，不够就打回去重做。

### Iterative Refinement：一次生成的不完美

很多任务不是"一次做对"的——写作需要修改、代码需要调试、方案需要优化。Iterative Refinement 解决的是**单次输出的能力上限**：通过多轮改进，逐步逼近更好的结果。

## Evaluator-Optimizer：生成者与评估者的循环

Anthropic 在 *Building Effective Agents*（2024）中将 Evaluator-Optimizer 列为五种核心 Agent 模式之一。它的结构很简单：

```text
Generator（生成者）→ 输出 → Evaluator（评估者）→ 反馈
                                          ↓ 不通过
                              Generator 根据反馈重新生成
                                          ↓ 通过
                                      最终输出
```

### 与 Basic Reflection 的区别

[反思章节](09-reflection-search-basic-reflexion-lats.md)讨论了 Basic Reflection：Generator → Critic 循环。Evaluator-Optimizer 看起来一样，但有两个关键区别：

1. **评估标准是明确的**：Evaluator 不只是"提意见"，而是对照预定义的 rubric 逐项检查。比如代码审查的 rubric 是"通过所有测试 + 无安全漏洞 + 代码风格符合规范"。
2. **有明确的通过条件**：不是"我觉得差不多了"就停，而是"每一项标准都达标"才通过。这使得迭代次数可预测。

```python
# Evaluator-Optimizer 的核心循环
def evaluator_optimizer(task, generator, evaluator, rubric, max_rounds=3):
    """
    task: 任务描述
    generator: 生成器 Agent
    evaluator: 评估器 Agent
    rubric: 评估标准列表
    max_rounds: 最大迭代次数
    """
    output = generator.invoke(task)
    history = [{"round": 0, "output": output}]

    for round_num in range(1, max_rounds + 1):
        # 评估：逐项检查
        evaluation = evaluator.invoke(
            f"评估以下输出是否满足标准。\n\n"
            f"标准：{rubric}\n\n"
            f"输出：{output}\n\n"
            f"对每项标准给出 pass/fail 和具体问题。"
        )

        # 检查是否全部通过
        if evaluation.all_passed:
            history.append({"round": round_num, "evaluation": "PASSED"})
            return output, history

        # 未通过：带着具体反馈重新生成
        history.append({
            "round": round_num,
            "evaluation": evaluation.feedback,
        })

        output = generator.invoke(
            f"原始任务：{task}\n\n"
            f"你之前的输出：{output}\n\n"
            f"评估反馈（请逐一修正）：\n{evaluation.feedback}"
        )

    # 超过最大轮数，返回当前最佳
    return output, history
```

### 评估标准的设计

Evaluator-Optimizer 的效果主要取决于评估标准（rubric）的质量。好的 rubric 是：

- **具体可量化**：不是"写得好"，而是"包含至少 3 个数据点引用"
- **无歧义**：Evaluator 对每个标准只能回答 pass 或 fail
- **完整**：覆盖输出质量的所有关键维度

```python
# 代码审查的 rubric 示例
CODE_REVIEW_RUBRIC = [
    {"id": "tests", "criteria": "所有单元测试通过", "check": "run_tests"},
    {"id": "security", "criteria": "无 SQL 注入、XSS 等安全漏洞", "check": "security_scan"},
    {"id": "style", "criteria": "代码风格符合 PEP 8", "check": "lint_check"},
    {"id": "coverage", "criteria": "测试覆盖率 ≥ 80%", "check": "coverage_report"},
    {"id": "docs", "criteria": "公共函数有 docstring", "check": "docstring_check"},
]
```

部分 rubric 项可以用确定性工具检查（如 `pytest`、`flake8`），不需要 LLM 评估。这比纯 LLM 评估更可靠，也是实践中推荐的方式：**规则能检查的用规则，规则检查不了的再用 LLM**。

### 适用场景

**适合**：有明确质量标准的任务——代码生成（必须通过测试）、翻译（必须准确且通顺）、合规审查（必须满足法规要求）。

**不适合**：没有明确标准的创意任务。"写一首好诗"没有 pass/fail 标准，Evaluator 无法给出有意义的反馈，迭代变成"随便改改"。

## Iterative Refinement：多轮自我改进

Iterative Refinement 是一个更广泛的模式。它不限于"两个 Agent"，也可以是单个 Agent 对自己的输出做多轮改进。

### Self-Refine

Self-Refine 出自论文 *Self-Refine: Iterative Refinement with Self-Feedback*（Madaan et al., 2023）。核心流程：

```text
1. LLM 生成初始输出
2. LLM 对自己的输出给出反馈
3. LLM 根据反馈改进输出
4. 重复 2-3，直到满意或达到最大轮数
```

关键数据（论文基准）：

| 任务 | 0 轮（初始） | 3 轮精炼 | 提升 |
|------|------------|---------|------|
| 代码生成（GPT-4） | 67% pass@1 | 82% pass@1 | +15pp |
| 学术写作（GPT-3.5） | 人类评分 3.2/5 | 4.0/5 | +25% |
| 对话优化 | 3.8/5 | 4.3/5 | +13% |
| 数学推理（GSM8K） | 78% | 84% | +6pp |

### 与 Evaluator-Optimizer 的关系

```text
Self-Refine:        同一个 LLM 既生成又评估（一人分饰两角）
Evaluator-Optimizer: 不同 LLM 分别做生成和评估（分工明确）
```

Self-Refine 更轻量（不需要部署两个 Agent），但评估可能不够客观——"自己评自己"容易放过问题。Evaluator-Optimizer 更可靠（独立的评估者），但成本更高。

实践建议：先用 Self-Refine（快速验证迭代改进是否有效），效果不够再加独立 Evaluator。

### 精炼的收敛

多轮精炼不会无限提升质量。经验数据：

```text
第 1 轮（初始输出）：基线
第 2 轮（首次精炼）：最大提升，通常占总提升的 50-60%
第 3 轮：继续提升，但幅度减小
第 4 轮及以后：边际收益递减，可能开始退化
```

推荐 **2-3 轮**作为默认设置。超过 3 轮后，收益通常不值得额外的 LLM 调用成本。

## 工程考量

### 成本模型

以 GPT-4o 为例，一个 Evaluator-Optimizer 循环（3 轮）的成本：

```text
生成（×3 轮）：3 次 LLM 调用
评估（×3 轮）：3 次 LLM 调用
总计：6 次 LLM 调用

单次生成成本：~$0.03
6 次调用总成本：~$0.18（6x）
```

Self-Refine 更省：

```text
生成（×3 轮）：3 次 LLM 调用（含自评）
总计：3 次 LLM 调用

总成本：~$0.09（3x）
```

### 避免退化

多轮精炼有时反而让输出变差——模型在修改中丢失了初始输出中的好内容。缓解方式：

1. **保留最佳版本**：每轮记录得分，最终返回历史最佳而非最后一轮
2. **限制修改范围**：反馈应该指向具体问题，而不是"整体改进"
3. **设置质量下限**：如果新一轮的得分低于上一轮，回退到上一轮

```python
# 防退化的精炼循环
def safe_refine(task, generator, evaluator, max_rounds=3):
    best_output = generator.invoke(task)
    best_score = evaluator.invoke(best_output).score

    for _ in range(max_rounds):
        improved = generator.invoke(
            f"改进以下输出：\n{best_output}\n\n只修改有问题的部分。"
        )
        current_score = evaluator.invoke(improved).score

        if current_score > best_score:
            best_output = improved
            best_score = current_score
        # 如果没有提升，不更新，保留最佳版本

    return best_output
```

### 评估器与生成器的模型选择

不需要用同一个模型。实际上，推荐：

```text
生成器：用强模型（GPT-4o、Claude Sonnet）— 需要创造力
评估器：可以用弱一点的模型 — 评估比生成更容易

或者反过来：
生成器：用便宜模型（GPT-4o-mini）— 先快速出草稿
评估器：用强模型 — 确保质量把关
```

具体选择取决于任务：如果生成是瓶颈（需要创造力），生成器用强模型；如果评估是瓶颈（需要准确判断），评估器用强模型。

## 模式选择指南

| 场景 | 推荐模式 | 原因 |
|------|---------|------|
| 有明确质量标准的任务 | Evaluator-Optimizer | 评估标准可量化 |
| 有经验的人类评估者 | 单生成 + 人工评估 | 人比 LLM 评估更可靠 |
| 快速迭代、成本敏感 | Self-Refine | 只需一个 LLM |
| 代码生成 | Evaluator + 规则检查 | pytest 比 LLM 评估更准 |
| 创意写作 | Self-Refine | 无明确标准，自我感觉改进 |
| 安全审查 | Evaluator-Optimizer | 安全标准不能放宽 |

一句话原则：如果能写出明确的评估标准，用 Evaluator-Optimizer；如果标准模糊，用 Self-Refine 尝试改进，但不要期望太高。

## 延伸阅读

- [Building Effective Agents - Anthropic](https://www.anthropic.com/engineering/building-effective-agents) — Evaluator-Optimizer 模式的工程实践
- [Self-Refine 原始论文](https://arxiv.org/abs/2303.17651) — Madaan et al., 2023，多任务基准数据
- [Reflexion: Language Agents with Verbal Reinforcement Learning](https://arxiv.org/abs/2303.11366) — 带记忆的反思循环，详见[反思章节](09-reflection-search-basic-reflexion-lats.md)
- [Constitutional AI: Harmlessness from AI Feedback](https://arxiv.org/abs/2212.08073) — Anthropic 用 AI 评估 AI 输出的方法
- [LLM as a Judge](https://arxiv.org/abs/2306.05685) — 用 LLM 做评估器的系统性研究
