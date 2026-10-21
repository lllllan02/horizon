---
learning_status: pending
title: "MCP 授权与权限"
parent: mcp
category: "Agent"
tags: ["MCP", "OAuth", "权限"]
created_at: "2026-10-11 10:06:16"
updated_at: "2026-10-16 20:46:14"
reading_suggestions:
  - tool-permissions
  - mcp-oauth-client
  - sandbox-execution
---

**「接入 Server、访问业务数据、批准一次操作」是不同的权限判断。** Client 接入常见有三种情形：

- 本地 stdio：宿主启动 Server 子进程，通常不走 HTTP 的 OAuth 流程；访问范围由进程权限和沙箱约束。
- 预先配置凭据：Client 按服务要求携带 API key 或 token，由应用从配置、环境变量或凭据存储中读取并注入请求。
- OAuth 用户授权：用户在浏览器登录并批准权限，Client 换取、保存和使用令牌；接入方式见[[mcp-oauth-client|最小 OAuth 示例]]。官方[授权规范](https://modelcontextprotocol.io/specification/2026-07-28/basic/authorization)面向 HTTP 传输。

Server 调用下游 API 是另一段授权关系，即使使用 stdio，也可能需要 API key 或用户授权；不能把发给 MCP Server 的令牌直接当作下游凭据。

凭据由应用管理，不放进提示词、工具参数或返回结果。配置和环境变量不自动构成隔离：模型若能调用读文件、Shell 等广泛工具，仍需通过[[sandbox-execution|工具权限与沙箱]]限制其读取凭据；日志也应避免泄露。

接入成功后，服务端及下游仍需按[[tool-permissions|业务权限规则]]检查用户能操作哪些数据；宿主另行判断本次动作是否需要用户确认。工具可见不等于获准执行，[[fastmcp-visibility-summary|FastMCP 的可见性控制]]只是其中一层，协议版本适用范围仍待核对。

## 给 Server 发了一个令牌，是否就完成了权限设计？

令牌能证明调用者身份或获授范围，但工具仍可能接受任意订单号；如果后端不检查对象归属，一个已登录用户就可能操作其他用户的资源。

把连接授权、工具权限和具体对象权限分开落实。客户端只展示当前可用能力，服务端在执行时核对实际参数与对象；模型传入的用户名、租户号或角色不能成为认证依据。服务代理下游 API 时，也要避免把自身宽权限直接等同于调用者权限。

撤权和令牌过期应有明确处理路径：需要重新认证就暂停相关动作，不让模型改用别的工具绕过。排障时区分认证失败、权限不足和业务条件不满足，才能决定是重新登录、申请权限还是修改任务。
