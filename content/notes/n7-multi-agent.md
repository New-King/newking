---
title: "Multi-Agent"
date: 2026-10-21
description: "多 Agent 如何分工与交接：派发、流水线、群聊等模式的区别与常见误区。"
url: https://new-king.com/notes/n7-multi-agent
series: "AI 学习笔记"
seriesOrder: 7
---
- 是什么：多个 agent 怎么分活、怎么交接；按「控制权怎么走」只分两类

- 容易混淆的
  pipeline 不是多 agent：一个调用链走多步（检索 → 重排 → 生成），只有一个 agent 在决策
  群聊也不是「没有决策」：有个规则决定谁说话（轮询 / 让模型选 / 按条件），那只是机制不是 agent

- 各家用的哪种
  Hermes：派发（delegate_task）+ 异步派发（kanban 任务队列）
  Claude Code / Cursor：派发（主 agent 派子 agent）
  Anthropic 多 agent 研究：派发（并行多个 subagent）
  OpenAI Agents SDK：两种都支持（agents as tools / handoffs）
  CrewAI：多个独立 agent + 顺序或层级编排
  AutoGen：协作（群聊协商）
  LangGraph：骨架，两种都能搭

- 为什么多数项目选派发
  成本说得清（谁花多少 token）
  死循环能拦（有总步数上限）
  出问题能定位（trace 是一条链，不是一团）
  代价：子 agent 看不到全局，回来只能给摘要

- 一句话
  能单 agent 就单 agent；要拆优先派发；异步长任务才上任务队列

**高频三问：**

1. 为什么需要多 agent？单 agent 不行吗？
    单agent同一份上下文且连续，更加稳定可靠，缓存命中高比较节省。
     （上下文满、速度慢）
    
    多agent：
     - 发布任务需要交代上下文细节，环境，返回格式等约束。
     - 乘性放大：90% * 90% * 90%，最终=70%左右
     - 开发周期拉长，测试成本增加
    
    只有三种情况值得拆：子任务分工明确且可并行 / 一个上下文装不下 / 需要不同专长和工具集。

2. 怎么分工：派发还是协作？
    看结果要不要回来。必须回来 → 派发（supervisor / 子 agent）；
    转走就不管 → 协作（handoff / 群聊）。
    生产上多数用派发：成本能算、循环能拦、trace 是一条链。

3. 怎么防失控：死循环、成本爆炸、进程挂了怎么办？
   - 死循环：全局轮数上限 + 子agent职责明确（输出格式（structured output）和结束信号）+ 检测来回转交（A 转 B、B 又转回 A）
   - 成本爆炸：全局 token / 调用次数预算，超了直接停
   - 挂了：同步（主 agent 在等）靠任务超时；异步（任务进了池子）靠加字锁占坑 + 到期时间，超时没人续就把活退回待办
   - orchestrator：统一管理状态，避免多 agent 之间直接调用


5. 拆子 agent 能省钱吗？
   一般不省，反而更贵：每个子 agent 都要重带系统提示词、工具定义、任务背景，结果还要摘要回来。
   只有两种情况可能省：原文很长但后续还要多轮（摘要替代原文，不用反复重读）；子任务用便宜模型。
   真正的收益是上下文隔离和并行，不是省钱。


6. Multi-Agent的几种形态
     - 父agent派发任务
     - 顺序流水线，一个agent干完交给下一个agent
     - 共同协作（）
	 - 图状态机（把协作画成显示的流程图）

---

## LangGraph 第 11 课：能答的面试题

7. 多 agent 有几种协作模式？区别是什么？
    委派（agents as tools）/ 移交（handoff）/ 主管（supervisor）
    核心区别是控制权：留在调用方 / 转走 / 中枢调度

8. 子 agent 和工具怎么选？
    工具是能力；子 agent 有独立提示词、上下文、自己的循环
    要上下文隔离、收窄工具权限才拆；否则加工具更省

9. 多 agent 之间上下文怎么隔离？
    子 agent 只看得到显式传进去的状态或参数，看不到父级聊天记录
    好处是不污染，代价是缺的信息必须显式传，否则它会自己编

10. 控制权转移怎么实现？
    LangGraph：节点返回 Command({ goto, graph: Command.PARENT })
    父图 addNode 用 ends 声明可达节点；update 里补配对的 ToolMessage，否则历史里留下悬空的 tool_call

11. 子图怎么复用？两种接法有什么区别？
    当节点：控制权交出去，适合固定流程（pipeline）
    用 tool() 包成工具：主 agent 拿回结果继续，适合取一个结论

12. 多 agent 怎么防跑偏、防死循环？
    Harness agent：**控制流归代码，语义判断归模型。**
    分工：子 agent 的提示词写清「返回什么格式、什么算干完」，别指望它自己判断该收手
    复核：模型说「完成了」只当建议；代码去状态里查真实产物（草稿有没有生成、关键工具有没有调过），没有就继续派活
    封顶：业务轮数 rounds、框架步数 recursionLimit、token / 调用预算，到点直接停

13. 多 agent 怎么调试？
    trace 看每一跳是谁做的决定、消息怎么流；最小版本是 routeLog 这类状态记录
