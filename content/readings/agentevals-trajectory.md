---
title: "AgentEvals：轨迹匹配与模型裁判"
category: "Agent"
tags: ["Agent", "评测"]
created_at: "2026-10-13 10:53:04"
updated_at: "2026-10-13 12:48:15"
source: ["https://github.com/langchain-ai/agentevals"]
---

AgentEvals 提供工具调用轨迹的规则匹配和模型裁判，关注 Agent 怎样完成任务。本文节选 2026-10-13 官方 README 中的轨迹评分，未执行库示例。

## 路径不唯一时怎样比较？

[轨迹匹配](https://github.com/langchain-ai/agentevals#trajectory-match) 提供 strict、unordered、subset、superset 模式：可严格比较序列、忽略顺序，或只限制允许动作、要求关键动作出现。subset 表示实际调用受参考集合约束；superset 允许额外调用，但要求参考中的关键调用被包含。

参数默认参与匹配，也可忽略参数、按部分字段或自定义函数比较。放宽顺序能接纳独立查询的交换，放宽参数却可能漏掉错误订单号，因此**「匹配尺度须对应具体要求」**。

## 模型裁判补充了什么？

规则难以列全合法路径时，库也支持让模型依据要求判断轨迹质量，并关联 LangSmith 实验。它减少了自行转换消息与组织评分的工作，但裁判仍需校准。

**「工具名和参数匹配只能提供过程证据」**：出现退款调用，不保证退款到账；相同工具集合，也可能先执行后审批。设计完整验收时，应另查最终状态和必要的事件先后关系。这是从匹配对象推导出的使用边界。
