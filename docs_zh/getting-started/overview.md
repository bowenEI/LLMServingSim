---
sidebar_position: 1
title: 概述
---

# 欢迎使用 LLMServingSim

LLMServingSim 是用于 **异构与分离式 LLM 服务基础设施** 的沙盒。想建模一款全新的 GPU？扫描并行策略？把奇特的存储层级（CXL、PIM）丢给工作负载？尝试一台你没有的 32 GPU 集群？一切尽在掌握。

安装真的很快：克隆、启动容器、编译、运行。**大约 10 分钟。** 进入之后，模拟器不会挡你的路。

## 你可以做什么

- **任意拓扑，即刻可用** — TP / PP / EP / DP+EP 跨多个实例。分块预填充、前缀缓存、MoE 专家路由、KV 缓存卸载，在配置文件中随意组合，无需修改代码。
- **任意硬件，均有剖析数据** — 接入新的 GPU、CXL 层级或 PIM 设备。基于 vLLM 的分层性能剖析器（layerwise profiler）捕获真实 CUDA 时序，并直接送入模拟器。
- **经 vLLM 验证** — TTFT、TPOT 与吞吐量的端到端误差低于 3%。这些数字真实反映生产环境服务的效果。
- **欢迎各种大胆场景** — ShareGPT 轨迹、代理会话、10× 集群、未发布的 GPU、奇特的存储层级，运行那些你在真实硬件上难以开展的实验。

## 三步完成第一次模拟

1. **安装** — 克隆、启动模拟器容器、构建 ASTRA-Sim，大约 10 分钟。[先决条件](./installation/prerequisites)
2. **运行** — 复制一条命令即可看到第一次端到端模拟，输出 CSV 可直接读取。[快速入门](./quickstart)
3. **解决问题** — 遇到障碍？常见错误与具体修复方案，全部集中在一处。[故障排查](./troubleshooting)

## 先决条件一览

一台装有 Docker 的 Linux 主机即可开始。

| 必需 | 可选但推荐 |
| --- | --- |
| Linux（Ubuntu 22.04+ 已测试） | NVIDIA GPU + Container Toolkit（仅用于剖析新硬件） |
| Docker | Hugging Face token（用于受限模型配置） |
| 支持子模块的 Git | 32 GB 内存（用于 vLLM 基准测试一侧） |
| 约 12 GB 可用磁盘 |  |

> 已经齐备？直接跳到 **[模拟器设置](./installation/simulator)**，10 分钟内跑起第一次模拟。

## 需要帮助？

- **Bug 或功能请求：** [GitHub Issues](https://github.com/casys-kaist/LLMServingSim/issues)
- **讨论：** [GitHub Discussions](https://github.com/casys-kaist/LLMServingSim/discussions)
- **想添加新硬件或模型？** 使用我们的 [性能剖析器指南](../profiler/overview) 自行剖析：这与我们内部使用的流程相同。
