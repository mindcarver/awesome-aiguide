# Prompt 管理系统：把 Prompt 当成线上接口

**TL;DR：** Prompt 是 AI 应用里变化最频繁、影响最隐蔽的业务逻辑。生产系统至少要管理 Prompt ID、版本、输入 schema、输出 schema、适用模型、Eval 结果、灰度和回滚。把 Prompt 写死在代码里，等于把最不稳定的接口藏进最难追踪的位置。

适用读者：入门到中级。你已经有多个 Prompt，并且开始遇到“改了一句话，不知道哪里变差”的问题。

## 问题：Prompt 是文本，但影响像代码

改一个词，模型可能从 JSON 输出变成自然语言。加一句约束，某类边界问题可能答不出来。换一个示例，模型可能开始偏向示例里的格式。换模型后，原来稳定的 Prompt 也可能不稳定。

如果 Prompt 没有管理，你无法回答：

- 当前线上使用的是哪个版本？
- 谁改的，为什么改？
- 这个 Prompt 适配哪些模型？
- 输入变量和输出结构是什么？
- 改动后哪些样本变好，哪些样本变差？
- 线上出问题能不能回滚？

Prompt 管理系统的目标不是让文本变复杂，而是给模型行为加工程纪律。

## 费曼解释：Prompt 像数据库迁移脚本

数据库 schema 改动要有版本、迁移记录、回滚方案和兼容性检查。Prompt 也是一样。它虽然是自然语言，但控制模型行为，影响下游输出结构和业务结果。

如果把 Prompt 当“临时文案”，系统会越来越不可控。如果把 Prompt 当“线上接口”，你会自然地给它版本、测试、发布和审计。

## 最小数据模型

一个可用的 Prompt Registry 至少需要三类记录：

```text
prompt
prompt_version
prompt_eval_result
```

### Prompt 主记录

```json
{
  "prompt_id": "rag.answer",
  "name": "知识库问答生成",
  "owner": "ai-platform",
  "status": "active",
  "current_version": "2.3.0"
}
```

### Prompt 版本

```json
{
  "prompt_id": "rag.answer",
  "version": "2.3.0",
  "template": "你是企业知识库助手。基于 <contexts> 回答 <question> ...",
  "input_schema": {
    "question": "string",
    "contexts": "array",
    "user_locale": "string"
  },
  "output_schema": {
    "answer": "string",
    "citations": "array"
  },
  "model_constraints": ["gpt-4.1-mini", "claude-sonnet-4.5"],
  "change_reason": "强化引用要求，减少无来源回答",
  "created_by": "carver",
  "created_at": "2026-05-25"
}
```

### Eval 结果

```json
{
  "prompt_id": "rag.answer",
  "version": "2.3.0",
  "dataset": "rag-regression-v5",
  "model": "gpt-4.1-mini",
  "pass_rate": 0.93,
  "citation_score": 0.89,
  "format_score": 0.99,
  "avg_latency_ms": 4100,
  "avg_cost_usd": 0.012
}
```

这个模型可以先放在 Git 文件里，也可以放数据库。重点不是存储介质，而是每次线上回答都能追溯到 `prompt_id@version`。

## Prompt ID 怎么命名

用稳定的“模块.动作”命名：

```text
rag.answer
rag.query_rewrite
agent.plan
agent.tool_select
support.classify_intent
invoice.extract_fields
security.output_review
```

不要用 `prompt1`、`new_prompt`、`final_final`。ID 是长期接口，版本才是变化。

## 输入和输出 Schema

Prompt 必须声明输入变量。否则模板会被随意拼接，注入风险和格式错误都会增加。

示例：

```yaml
prompt_id: invoice.extract_fields
version: 1.4.0
inputs:
  invoice_text:
    type: string
    required: true
  locale:
    type: string
    default: zh-CN
outputs:
  type: object
  required:
    - invoice_no
    - amount
    - currency
  properties:
    invoice_no:
      type: string
    amount:
      type: number
    currency:
      type: string
```

输出 Schema 很关键。它让后处理、Eval 和调用方都知道该期待什么。模型输出不稳定时，优先做结构化输出和 schema 校验，而不是在业务代码里写一堆脆弱的正则。

## 版本规则

推荐用语义化版本，但语义按行为影响定义：

```text
PATCH: 文案澄清，不改变输入输出和主要行为
MINOR: 改善某类任务，理论上兼容旧输出
MAJOR: 输入变量、输出结构、引用规则、工具调用方式发生变化
```

例子：

```text
2.3.1: 修正文案，减少重复回答
2.4.0: 增加“必须引用来源”的约束
3.0.0: 输出从纯文本改为 JSON
```

只要下游解析方式可能受影响，就不要装作是小版本。

## 发布流程

```text
草稿
-> 本地样例测试
-> 小型 Eval
-> 全量回归 Eval
-> 灰度
-> 监控
-> 全量
```

每次发布至少记录：

- 改动内容；
- 改动原因；
- 关联需求或事故；
- Eval 数据集版本；
- 与 baseline 的差异；
- 灰度范围；
- 回滚版本。

如果 Prompt 是高风险链路，例如财务、权限、安全、医疗、法律，必须有人复核。

## 灰度和回滚

Prompt 灰度可以按租户、用户、流量比例或任务类型做：

```text
tenant=internal -> rag.answer@2.4.0
tenant=beta_customers -> rag.answer@2.4.0
default -> rag.answer@2.3.0
```

每条请求日志都要记录：

```json
{
  "trace_id": "req_123",
  "prompt": "rag.answer@2.4.0",
  "model": "gpt-4.1-mini",
  "dataset_baseline": "rag-regression-v5"
}
```

没有这个记录，线上用户说“昨天回答更好”时，你查不到到底变了什么。

## Prompt 和模型要绑定测试

Prompt 不是跨模型自动兼容的。同一段 Prompt 在不同模型上的表现可能不同。Prompt Registry 里要记录“这个版本在哪些模型上通过了哪些 Eval”。

推荐矩阵：

| Prompt | 模型 | 数据集 | 通过率 | 成本 | 延迟 | 状态 |
|--------|------|--------|--------|------|------|------|
| rag.answer@2.3.0 | gpt-4.1-mini | rag-v5 | 93% | $0.012 | 4.1s | prod |
| rag.answer@2.3.0 | small-router | rag-v5 | 86% | $0.003 | 1.8s | fallback |
| rag.answer@2.4.0 | gpt-4.1-mini | rag-v5 | 95% | $0.014 | 4.4s | canary |

这样模型路由和降级才有依据。

## 常见误区

### 把 Prompt 放代码里

开发方便，但线上追踪困难。至少把 Prompt 提取成带版本的文件，并在请求日志里记录版本。

### 只存最新版本

这会让回滚和事故复盘变得困难。旧版本不是垃圾，是生产证据。

### 没有 Eval

Prompt 改动如果没有回归测试，团队会陷入“这个版本我感觉更好”的争论。

### 只看总分

总分提升可能掩盖安全退化。例如引用质量提高了，但权限泄露也增加了。报告必须按标签拆。

### Prompt 试图解决所有问题

延迟、成本、权限、数据质量、工具设计不一定靠 Prompt 解决。Anthropic 的 prompt engineering 指南也强调，先定义成功标准和评估方法，不是所有失败都应该靠改 Prompt。

## 权衡与局限

Prompt 管理会带来流程成本。小团队一开始不需要复杂后台，可以从 Git + YAML + Eval 报告开始。等 Prompt 数量、协作人数、灰度需求上来，再做数据库和可视化管理。

另一个局限是版本化不能消除模型不确定性。它只能让变化可见、可测、可回滚。

## 结论

Prompt 是线上接口，不是临时文案。生产系统要知道每次回答用了哪个 Prompt、哪个版本、哪个模型、哪组输入、哪次 Eval 结果。

从最小做起：Prompt 文件化、版本化、schema 化、日志化、Eval 化。做到这五点，Prompt 才能进入工程协作。

## 延伸阅读

- [Anthropic: Prompt engineering overview](https://docs.anthropic.com/en/docs/build-with-claude/prompt-engineering/overview)
- [Anthropic: Define success criteria and build evaluations](https://docs.anthropic.com/en/docs/test-and-evaluate/define-success)
- [OpenAI API: Graders](https://platform.openai.com/docs/guides/graders/)
- [OpenTelemetry: GenAI observability](https://opentelemetry.io/blog/2026/genai-observability/)
