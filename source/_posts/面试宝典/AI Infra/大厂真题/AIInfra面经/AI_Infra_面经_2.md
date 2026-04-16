---
title: 'AI Infra 面经 (2)'
date: 2026-04-16 12:21:14
categories:
  - [求职面试, AI Infra, 大厂真题]
tags: [AIInfra, 推理优化, 训练优化, 算子优化, 高性能计算, 面经, 牛客]
---

# AI Infra 面经 (2)

<!-- more -->

> 原文链接: https://www.nowcoder.com/discuss/851502759596523520
> 来源: 牛客网

---

C++/CUDA/AI-infra面试经验总结

我自己在搞 AI Infra/HPC，有两个一直在维护的仓库：

一个是用 C++/CUDA 从零写的深度学习框架：OriginDL
另一个是工作中一点点积累下来的 AI Infra/HPC 知识地图：ai‑infra‑hpc

链接先丢这儿，感兴趣可以先 star 了再说：

https://github.com/jinbooooom/OriginDL

https://github.com/jinbooooom/ai-infra-hpc

如果你是刚开始找工作，或者准备投大模型 AI Infra/HPC 方向的岗位，可以把下面这份当成一个「复习清单」：面试高频会围着哪些点打转、我当时是怎么系统整理的、以及怎么用 OriginDL 这种项目给自己加分。

1. 芯片 & 算力：先搞清楚“算力”到底在算啥（01 chip）

这一块其实就是：别一上来就喊「算力不够」，至少知道它是怎么来的。

GPU / CPU 架构

面试很爱问的几个点：GPU 和 CPU 真正的区别在哪，SM、Warp、SIMD/SIMT 分别是什么，Warp 分化会带来什么性能坑。

算力和带宽

训练慢的时候，通常会卡在哪些硬件指标上？（FLOPS、显存带宽、PCIe 带宽等等）
MFU（Model FLOPS Utilization）大概是个什么概念，怎么判断「算力有没有用满」？
2. CUDA & 高性能计算：Infra 的基本盘（02 hpc / 05 cuda）

这块是真·逃不过去的基础，很多实习/校招都喜欢在这儿细抠。

CUDA 编程模型

Grid / Block / Thread 这三层为什么要分这么细？Block 为什么这么设计？
核函数修饰符大概干嘛用：__global__、__device__、__host__、__shared__、__constant__、__restrict__、__managed__……能说出典型使用场景就很好了。

执行模型 & GPU 架构

Block 为什么不能跨 SM 拆？Block 是怎么被丢到 SM 上跑的？
Warp 是怎么执行的？SIMD 和 SIMT 有什么本质区别？

内存层次 & 性能优化

GPU 上常见的几种内存：寄存器、local、shared、global、constant、texture……大概谁快谁慢、谁适合干啥。
「对齐 & 合并访问」（coalesced access）是什么鬼？如果访存不合并，会直接体感变慢。

流和并发

CUDA Stream 是干嘛用的，怎么用它把计算和数据拷贝「叠」在一起？
Hyper‑Q 解决的是哪一类「硬件很闲但任务排不上」的问题？

调试 & 性能分析

Nsight / ncu / nvprof 这些工具，通常会看的核心指标是什么？
拿到一个慢 kernel，大致排查顺序怎么走？（访存 → 占用 → 指令 → 并发……）
CUDA‑GDB 和普通 C++ 调试相比，多了哪些需要留意的地方？（线程维度、设备内存之类）
3. 多机多卡互联 & 拓扑：八卡机器到底是怎么“连”的（03 link / NVLink / NVSwitch / PCIe）

大模型训练离不开多卡互联和拓扑设计，这块越熟，你越能看懂大厂机房里的那些「线怎么接」。

NVLink / NVSwitch

NVLink 比 PCIe 强在哪？带宽和延迟大概是什么级别的差异？
NVSwitch 怎么把一堆 GPU 织成一个「全互联」？常见的 8 卡拓扑长什么样？

服务器拓扑 & 选型

常见的 8 卡服务器拓扑：串行、并行、偏 HPC 的几种配置，它们各自的 trade‑off。
如果让你挑一台机器用来训大模型，你会关注哪些点？（直连链路、CPU/GPU 亲和性、IB 网卡插在哪个 NUMA 节点上……）

NUMA & 亲和性

NUMA 是什么，为什么「绑核、绑卡」会对性能有那么大影响？
Linux 下怎么看设备的 NUMA 信息？亲和性乱配会导致哪些肉眼可见的抖动？
4. GPUDirect：数据在 GPU 和外设之间是怎么“飞”起来的（03 link / 05 gpuDirect）

这块帮你回答各种「zero‑copy」「RDMA 直通 GPU」之类的。

GPUDirect 几个形态

大概知道 GDS、P2P、GDR 各自干嘛；
GPUDirect P2P 和 GPUDirect RDMA 分别解决什么问题。

三个关键实现问题（高频）

这一块很多人都答不清，你能讲明白就很加分：

网卡是怎么直接读写 GPU 显存的？中间经历了什么映射和内存注册？
GPU 怎么访问通信资源，比如网卡寄存器、队列这些东西？
GPU 怎么提交通信请求、怎么和网卡同步？所谓「门铃机制」是怎么回事？

GPU 内存管理的一些细节

锁页内存（pinned memory）、零拷贝内存、UVA、UM 各自适合什么场景？
为什么 pinned memory 往往带宽更高？有没有可能把系统搞崩？
5. RDMA & InfiniBand：集群网络的主战场（03 link / 08 infiniband）

如果你去的是有自建集群的公司，这块基本都是家常便饭。

RDMA 基础 & 优势

RDMA 到底是什么？它绕开了传统 OS 内核的数据路径之后，有哪些立竿见影的好处？
SEND/RECV、READ/WRITE、带立即数这些操作，大概是用在什么场景？

一堆名词的关系捋顺

RDMA、InfiniBand、IBoE、RoCE、iWARP、IB 卡、IB 驱动……这堆名词之间的关系；
RoCE v1 和 v2，在协议上和性能上的主要差异。

资源模型 & 编程接口

QP / CQ / MR / MW / PD / AH 分别抽象的是什么资源？
为啥 RDMA 一定要做「内存注册」？注册 GPU 显存时会多出哪些限制？

性能调优 & 排障

小包延迟优先时，一般会用哪些手段？（批量 post、inline、不打太多信号等）
带宽优化时，会重点看 MTU、QP 数量、NUMA、PCIe 抖动什么的；
RDMA 延迟抖动，常见的是 CPU 隔离、中断绑定、亲和性这几块没配好。

环境搭建 & 常见坑

从 0 部署一套 IB/RDMA 环境，大概要装什么、配什么、用哪些工具自检？
PORT DOWN、端口起不来、连不上之类的典型报错，排查思路是什么？
6. 集合通信 & NCCL：大模型训练必经之路（05 ccl / 02 nccl）

只要你说「我们这边有多卡/多机训练」，面试官十有八九会问到 NCCL。

集合通信算法

AllReduce / AllGather / ReduceScatter / Broadcast 各自干嘛；
Ring / Tree / Bruck 这些实现大致的优缺点：谁延迟更好、谁带宽更好。

NCCL 大致怎么“想”的

它是如何利用机器的实际拓扑（NVLink、PCIe、IB）来建图的？
channel 这个概念是干嘛的，为什么要拆成一堆 channel？

NCCL 协议

Simple / LL / LL128 这三种协议分别适合哪种场景？对延迟/带宽会有什么影响？
LL128 为啥块更大？背后的 trade‑off 是什么？

实战向问题

多机多卡训练时，AllReduce 老是卡住/忽快忽慢，你会从哪几条线开始查？（拓扑、环境变量、NCCL_DEBUG 日志、IB 计数器、交换机……）
千卡规模的时候，有哪些踩坑经验可以提前说出来？
7. 训练 & 推理侧：从系统视角看大模型（06 trainAndInfer）

这里有点偏向「系统 + 算法的交界」，但对 Infra 岗也很重要。

参数量 & 显存

大致知道 1B 参数大概要吃多少显存；
训练 vs 推理，显存主要分别花在哪儿？为什么激活值占大头？

并行 & 分布式训练

数据并行（DP/DDP）、模型并行（张量并行 / 流水线并行）、专家并行（MoE），各自的核心想法和适用场景；
ZeRO 各个 stage 大概都在「减什么」：参数、梯度、优化器状态……

系统指标 & 瓶颈定位

MFU、GPU 利用率、吞吐（tokens/s）之间大概什么关系；
怎么根据监控判断「现在是算力打不满」还是「网络/IO 拖了后腿」？

推理优化

推理阶段常见的几板斧：KV cache、batching、各种并行、runtime 优化等等。
8. 工程实践类：简历/面试里最好能讲出来的东西

上面这些更偏「知识点」，但真到面试桌上，工程类题目往往更关键：

你有没有从 0 到 1 写过 CUDA kernel 并调过性能？大概路线是怎么分析、怎么改的？
有没有亲手处理过 RDMA / NCCL / NVLink 相关的 bug？举个例子，怎么发现问题，怎么一步步缩小范围的？
给你一台 8 卡机器，让你「尽量榨干」训练性能，你会从哪几件事做起？
日常分析性能瓶颈时，你会用哪些工具？比如 Nsight、nvidia-smi dmon、IB 计数器、perf/Ftrace/ebpf 之类。

本质上，面试官是想通过这些问题确认：你对那一整套知识，是不是只停留在“会背名词”，还是确实在工程里摔过跤。

9. OriginDL 能帮你什么（怎么把项目讲进面试）

最后稍微硬广一下我自己的小玩具框架 OriginDL，它其实非常适合拿来当「面试项目」讲。

OriginDL 是一个用 C++/CUDA 从零写的深度学习小框架，里面有：

自己写的底层矩阵运算和 GPU kernel；
在上面搭的自动求导和神经网络模块；
线性回归、MNIST、YOLOv5 推理等完整 demo。

有了这么一个项目，你在面试里就可以：

很自然地聊 CUDA 和 GPU

某个算子的 kernel 是怎么设计的；
Block/Grid 怎么配；
shared memory 和 global memory 是怎么配合用的。

从上到下讲一遍训练/推理链路

高层 API 调一次 forward，下面具体触发了哪些 kernel；
哪里用到了流、事件、异步拷贝；
哪些地方一不小心就会出性能/显存问题。

这种细节，是很难靠「临时抱佛脚」编出来的，面试官一般一听就知道你是真的做过。

如果你把 ai‑infra-hpc 这个仓库当「知识地图」，平时查问题/准备面试就翻它；再把 OriginDL 当实验田 + 面试项目，有空就往里加点小功能、做点小优化，基本上大模型 AI Infra/HPC 方向面试里常见的那些问题，你都能找到对应的落脚点。

最后再放一遍仓库地址，帮忙 star 一下：

https://github.com/jinbooooom/OriginDL

https://github.com/jinbooooom/ai-infra-hpc
