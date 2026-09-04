# AI 应用工程架构：把 Demo 改造成可维护系统

**TL;DR：** 生产级 AI 应用不是在接口里多调一次模型，而是把模型调用、Prompt、检索、工具、状态、评估、权限和观测拆成可替换的边界。架构的目标不是显得复杂，而是让每次改 Prompt、换模型、调检索、加工具之后，都能验证、回滚、排障。

适用读者：中级。你已经做过一个能跑的 AI Demo，现在要把它交给团队协作、上线、持续迭代。

## 问题：Demo 最大的债是边界不清

很多 AI Demo 长这样：

```text
POST /chat
  -> 拼 Prompt
  -> 查向量库
  -> 调模型
  -> 调工具
  -> 写数据库
  -> 返回答案
```

这能证明想法，但不能支撑生产迭代。问题会很快出现：

- 想换模型，结果业务逻辑、Prompt 和计费逻辑都要一起改；
- 想调 Prompt，不知道当前线上到底跑的是哪个版本；
- RAG 答错了，分不清是召回错、重排错、引用错还是模型编造；
- Agent 多走了十几步，既看不到中间状态，也不知道哪一步浪费了成本；
- 上线前无法回答“这次改动有没有让老问题变差”。

工程架构要解决的不是“怎么把所有组件接起来”，而是“每个组件的责任边界在哪里，出了问题能不能定位，改动能不能被验证”。

## 费曼解释：AI 应用像一条后厨流水线

把 AI 应用想成餐厅后厨。服务员负责点单，收银台确认订单格式，主厨决定怎么做，切菜、炒菜、摆盘是不同工位，质检员检查菜有没有出错，监控记录每一步。

Demo 是一个人包办所有事，速度快，但高峰期一定乱。生产系统要分工，不是为了“架构好看”，而是为了让某个工位出问题时不用把整家店拆掉。

## 推荐架构：用能力层隔离 AI 变化

```text
Client
  -> API Layer
  -> Application Service
  -> AI Capability Layer
       - Model Gateway
       - Prompt Registry
       - RAG Service
       - Agent Runtime
       - Eval Service
  -> Data Layer
       - Relational DB
       - Vector Store
       - Object Storage
       - Cache
  -> Cross-cutting
       - Auth / Permission
       - Observability
       - Cost Control
```

这不是必须一次全做。它更像一张演进地图：当某个能力开始变化频繁、影响范围变大，就把它从业务代码里拆出来。

## 各层该负责什么

### API 层：只处理协议

API 层负责请求协议、参数校验、鉴权、限流、响应格式。它不应该直接拼 Prompt、查向量库或调用工具。

坏味道：

```python
@app.post("/chat")
async def chat(req):
    docs = vector_db.search(req.question)
    prompt = f"基于这些资料回答：{docs}\n问题：{req.question}"
    answer = openai_client.responses.create(model="...", input=prompt)
    db.save(answer)
    return {"answer": answer.output_text}
```

更好的边界：

```python
@app.post("/chat")
async def chat(req: ChatRequest, user: User = Depends(current_user)):
    result = await chat_service.answer(
        user=user,
        question=req.question,
        conversation_id=req.conversation_id,
    )
    return ChatResponse.from_result(result)
```

API 不知道 Prompt 长什么样，也不知道底层用哪个模型。它只知道“业务服务能回答问题”。

### 应用服务层：编排业务流程

应用服务层负责业务语义。例如企业知识库问答：

```text
校验用户权限
-> 生成检索请求
-> 调 RAG Service
-> 选择 Prompt 版本
-> 调 Model Gateway
-> 做格式校验和引用校验
-> 保存对话和 trace_id
-> 返回业务结果
```

这里可以出现业务规则，比如“财务制度类问题必须带引用”“高风险问题要走人工确认”“客户 A 不能读取客户 B 的上下文”。

### Model Gateway：统一模型调用

模型网关负责把不同模型供应商包成统一接口：

- 模型路由：简单分类走小模型，复杂推理走强模型；
- 重试和超时：区分限流、网络错误、模型输出格式错误；
- 成本记录：输入 token、输出 token、缓存命中、估算费用；
- 参数治理：temperature、max tokens、reasoning effort 等参数不能散落在业务代码里；
- 降级策略：主模型失败时是否切备用模型，是否允许质量降低。

不要让业务代码到处写 `client.chat.completions.create(...)`。一旦模型 API 或计费策略变了，全系统会一起震。

### Prompt Registry：把 Prompt 当成版本化接口

Prompt 是 AI 应用里变化最频繁的业务逻辑。它应该有：

- 稳定 `prompt_id`；
- 版本号；
- 输入 schema；
- 输出 schema；
- 适用模型；
- 变更原因；
- Eval 结果；
- 灰度和回滚记录。

Prompt 不只是文本，它定义了模型和业务系统之间的接口。输出从 JSON 变成自然语言，和后端 API 破坏兼容性没有本质区别。

### RAG Service：让检索链路独立演进

RAG 不应该只是 `vector_store.search()`。一个可维护的 RAG Service 至少包含：

```text
query rewrite
-> permission filter
-> retrieval
-> rerank
-> context packing
-> citation metadata
```

检索层必须先做权限过滤，再把内容交给模型。不要把所有文档都塞进上下文，然后要求模型“不要泄露不能看的信息”。模型不是权限边界。

### Agent Runtime：管理循环、状态和工具

Agent 不是“让模型自由发挥”。生产级 Agent Runtime 要管理：

- 任务目标和停止条件；
- 每一步的观察、计划、动作和结果；
- 工具 schema、权限、超时、重试；
- 人工确认点；
- 最大迭代次数和预算；
- 中断恢复；
- 全链路 trace。

Anthropic 对 agent 的经验很直接：能用简单 workflow 解决的任务，不要急着上 Agent；Agent 适合路径无法预先写死、需要根据环境反馈动态调整的任务。

### Eval Service：给改动设置质量门

Eval Service 要能在 Prompt、模型、RAG、工具变更时批量跑回归集。它不只测模型裸输出，而是测完整链路。

最小 Eval 数据流：

```text
dataset
-> run system
-> grade output
-> compare baseline
-> report regression
-> feed failures back to dataset
```

没有 Eval，架构再清晰也很难持续演进，因为每次改动都只能靠人看几条样例判断。

## 一个最小可维护目录

下面不是框架规定，而是一种边界示例：

```text
app/
  api/
    chat_routes.py
  services/
    chat_service.py
    document_service.py
  ai/
    model_gateway.py
    prompt_registry.py
    rag_service.py
    agent_runtime.py
    eval_runner.py
  security/
    auth.py
    permission_filter.py
    audit_log.py
  observability/
    tracing.py
    cost.py
  storage/
    db.py
    vector_store.py
    object_store.py
```

你可以先从单体开始，但模块边界要提前清楚。单体不是问题，边界混在一起才是问题。

## 生产就绪检查表

- API 层没有直接调用模型、向量库和工具；
- 所有模型调用都经过 Model Gateway；
- Prompt 有版本、schema、负责人和变更记录；
- RAG 检索前做权限过滤；
- Agent 有最大步数、预算、停止条件和人工确认点；
- 每次请求有 `trace_id`；
- 日志记录模型、Prompt 版本、检索片段、工具调用、token、成本、延迟；
- 上线前跑 Eval，失败样本能回流；
- Prompt、模型、检索策略都能灰度和回滚；
- 密钥、租户、缓存、日志都有隔离策略。

## 什么时候不要过度架构

不是所有项目都需要完整平台。下面情况可以保持简单：

- 只有一个内部用户；
- 没有敏感数据；
- Prompt 很少变化；
- 不需要 RAG 或工具调用；
- 失败成本低；
- 每天请求量很小。

但简单不等于随意。至少把模型调用、Prompt 文本和业务流程分开。这样后续要升级时，不需要从一团 Demo 代码里拆线。

## 权衡与局限

分层会增加文件数量、接口设计和初始开发成本。过早拆服务还会带来部署、网络、权限和观测复杂度。稳妥做法是先做“模块化单体”：边界在代码里清楚，部署仍然简单；等某个模块的团队、负载或变化频率真的独立了，再拆成服务。

另一个风险是把框架当架构。框架能帮你调用模型、定义工具、组织 workflow，但不能替你定义业务边界、权限模型、质量标准和回滚策略。

## 结论

AI 应用工程化的核心是让不稳定的部分可控：模型会变、Prompt 会变、检索数据会变、工具会变，用户输入更会变。生产架构要做的，是把这些变化放在有边界、有版本、有观测、有评估的地方。

先用模块化单体跑通，再按变化频率拆能力层。不要从“大平台”开始，也不要把 Demo 当生产系统。

## 延伸阅读

- [Anthropic: Building effective agents](https://www.anthropic.com/engineering/building-effective-agents)
- [OpenTelemetry: Semantic conventions for generative AI systems](https://opentelemetry.io/docs/specs/semconv/gen-ai/)
- [OpenTelemetry: Inside the LLM Call](https://opentelemetry.io/blog/2026/genai-observability/)
- [OWASP Top 10 for LLM Applications 2025](https://genai.owasp.org/llm-top-10/)
- [OpenAI API: Graders](https://platform.openai.com/docs/guides/graders/)
