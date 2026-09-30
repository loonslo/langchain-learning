# 5.6 调用日志与 Ollama 本地推理：先记录，再换到本机

[全书目录](../../README.md) · [上一章 5.5](../5.5-docker-packaging/README.md) · [下一章 5.7](../5.7-security-guardrails/README.md)

- **目标**：给每次模型调用记一条结构化日志，并了解怎样把开源模型跑在本机（Ollama）。
- **前置**：3.6、5.2。
- **环境**：日志部分调用真实模型；Ollama 部分需要 `pip install langchain-ollama`，并在本机安装 Ollama、拉取过任一模型，缺任一条件会跳过并提示。
- **命令**：`python tools/run_chapter.py 5.6`

## 问题

上线后要能回答“哪条请求慢了、贵了、答错了”。除了 LangSmith trace（3.6），最朴素的办法是给每次调用记一条结构化日志。另一方面，有些数据不能出门，或者不想付 API 费用，可以把开源模型跑在自己的机器上。

## 概念

- **结构化调用日志**：时间、问题、耗时、token、是否出错，追加到 `calls.log.jsonl`，一行一条。有这些字段才能做监控、算 P95 延迟和错误率、设告警。
- **可观测三件套**：trace（看单条调用的每一步）+ 结构化日志（统计延迟、错误、成本）+ 指标告警（基于日志算 P95、错误率，超阈值报警）。
- **Ollama**：本地运行开源模型，数据不出门，没有 API 费用；接法和云模型几乎一样，换一个 `ChatXxx` 类。只需了解；vLLM、TGI、SGLang 是自托管时提升吞吐的推理框架，用到再深入（9.11）。

## 流程

1. `logged_invoke`：调用模型，记录耗时、token 和是否成功，追加到日志文件。
2. `try_ollama`：`pick_local_model` 取本机第一个模型（或用 `OLLAMA_MODEL` 指定），调用一次；没有 Ollama 时跳过并提示。

## 代码导读

[ollama_inference.py](ollama_inference.py)：先看 `logged_invoke` 里的 `record` 字段，再看 `try_ollama` 的跳过条件。

## 练习

1. 运行几次，写一个小脚本读取 `calls.log.jsonl`，计算平均和最大延迟、错误率，这就是最简监控。
2. 故意让一次调用失败（错误的密钥），确认日志里 `ok` 为 `false` 且带有 `error`。
3. 装好 Ollama 后，对比本地小模型与云端模型在同一问题上的回答和延迟。

## 运行与边界

- 日志里记录了问题原文，含个人信息时要脱敏（5.7）。
- 本地小模型的质量和云端模型差距很大，替换前要用评测集比较。
