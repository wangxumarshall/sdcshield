** Kunpeng 920系列**  
鲲鹏920系列是华为海思于2019年发布的首款7nm工艺数据中心级ARM服务器处理器，也是业界首款量产的7nm ARM服务器SoC。它采用自主设计的**TaiShan V110（TSV110）** 自定义核心，基于ARMv8.2-A架构，完全兼容aarch64（64位ARM）。该处理器最高集成64核，主频最高2.6GHz（部分SKU可达3.0GHz），TDP 95–180W（典型180W），针对大数据、分布式存储、云原生应用、数据库等高并发服务器场景优化，强调高性能/功耗比（PPA）和能效。在SPECint 2017基准测试中单芯片得分超过930（或多芯片配置下更高，如4芯片256核配置），较当时业界标杆高约25%，能效优30%。与前代（基于ARM公版Cortex-A72/A57的Kunpeng 916/912）相比，单核性能提升约30%，整机吞吐提升近50%。
### 1. SoC整体架构（Chiplet异构封装 + HCCS）
鲲鹏920采用**3-DIE Chiplet异构封装**（TSMC CoWoS 2.5D + LEGO式模块化生产），这是业界较早的服务器级Chiplet方案：
- **2个Compute Die（计算Die，TSMC 7nm）**：每个Die集成32个TaiShan V110核心（共64核）。每个Die含8个Cluster（CPU Cluster，CCL），每个Cluster含4核 + 共享LLC Tag。
- **1个IO Die（TSMC 16nm）**：负责PCIe、RoCE网络、SAS/SATA、加速引擎（HPRE/SEC等）以及外部互联。
- **Die间互联**：通过高速Coherent Inter-Die Link（SLLC/Hydra协议），带宽最高400 GB/s，支持全缓存一致性（HCCS，Huawei Cache-Coherent System）。支持2S/4S多路扩展（通过Hydra链路）。
- **NoC（片上网络）**：每个Compute Die采用**自主设计的Bufferless双环形Mesh NoC**（无缓冲双环），与核心频率对齐（最高3GHz），面积占比<7%，功耗/面积较传统缓冲NoC降低50–70%。99%以上报文直达传输，延迟<15ns（intra-die），支持QoS和MPAM（Memory Partitioning and Monitoring）。
- **NUMA特性**：每个Compute Die作为一个NUMA节点，支持ccNUMA。L3 Cache支持三种模式：**Shared（全共享）**、**Private（Cluster私有）**、**Partition（分区，默认，可动态调整）**，后者可降低平均延迟>5%，特别适合云多租户场景。
**内存子系统**：单SoC支持8通道DDR4-2933（官方最高2933 MT/s，部分SKU支持更高有效带宽），每个Compute Die边缘集成DDR控制器。理论峰值内存带宽计算公式为：  
\[\text{Bandwidth} = 8 \times 8 \times 2933 \approx 187.7 \, \text{GB/s}\]  
（较当时主流提升46–60%）。L3命中延迟~36周期（分区模式下~4MB有效），DRAM unloaded ~96ns，负载下>100ns。
**I/O与硬件加速器**：
- PCIe 4.0（40通道/640 Gbps，业界首发）。
- **2×100G RoCE v2**（RDMA over Converged Ethernet，直出网络）。
- CCIX（Cache Coherent Interconnect for Accelerators）。
- 集成硬件压缩/解压引擎（支持ZLIB/GZIP，释放CPU通用算力）。
- HPRE（高性能加密）、SEC（安全引擎）、RSA/ECC非对称加密加速。
- 支持SVM（Shared Virtual Memory）虚拟化。
封装：60mm×75mm BGA，Compute Die面积约452mm²。
### 2. 指令集特征（ARMv8.2-A ISA）
鲲鹏920持有ARMv8.2-A架构授权（Architecture License），自主实现核心微架构，兼容ARMv8.0/8.1及AArch64指令集。
- **寄存器与编码优化**：AArch64提供**31个通用寄存器（x0–x30）** + 零寄存器（XZR，硬编码为0），指令编码精简（移除AArch32时代大部分条件执行指令），显著减少编译器在处理复杂逻辑时的寄存器溢出（Register Spill）损耗。
- **向量/SIMD**：支持**128位宽NEON Advanced SIMD**指令集，双FSU流水线（FP32×2或FP64 quarter-rate）。支持**FP16扩展**（ARMv8.2可选），适用于轻量级AI推理硬件加速。与x86对比：向量宽度仅为AVX-512的1/4，避免超宽向量运算导致的严重降频（AVX Offset），在标量整数运算为主的云微服务、Web应用和数据库场景中能维持更高稳定频率和功耗。
- **密码学与安全扩展**：原生支持SHA-1/SHA-2、AES、CRC32硬件级计算指令，网络封包处理、HTTPS加密连接、存储数据校验可走硬件加速。
- **虚拟化与RAS特性**：
  - **VHE（Virtualization Host Extensions）**：优化KVM等Hypervisor，宿主机内核可直接在EL2运行，显著减少虚拟机与宿主机上下文切换开销。
  - **企业级RAS**：支持指令/数据缓存的ECC（纠错码）校验、内存毒化隔离（Memory Poisoning）、PCIe AER（高级错误报告）等，提供99.999%可用性保障。
- **其他扩展**：LSE（Large System Extensions）高效原子操作（LDADD/LDCAS等），极大提升多线程同步（如数据库锁）；支持ARMv8.2 Crypto扩展；RAS特性；编译器优化支持`-mtune=tsv110`（GCC/Clang/LLVM）。
### 3. TaiShan V110核心微架构（4-wide OoO，自定义服务器优化）
TaiShan V110是华为首款完全自主设计的服务器级ARM核心，采用**4-wide超标量乱序执行**设计，取舍方向是高核数（64核/芯片）与高并发吞吐量，单核IPC和频率让位。它面向高并发云服务、大数据处理和分布式存储，不追求桌面级单核性能。
#### 前端流水线与分支预测
- **取指与解码宽度**：4发射（4-wide）超标量前端，每个时钟周期最多从L1指令缓存中获取并解码4条指令（~16–32字节）。
- **L1I Cache**：64KB，4-way，64B line，ECC。
- **分支预测单元（BPU）**：高度优化的**两级动态分支预测器** + 64-entry BTB（1周期taken目标），31-entry返回栈，间接分支预测器支持~256目标/16周期历史。代码在32KB内命中延迟3周期；分支密集（≤16B间隔）场景+1周期惩罚；L2/DRAM分支额外+11–38周期。准确率与同期Intel Goldmont Plus相当。
- **iTLB**：32-entry（L1），1024-entry L2 TLB。
#### 后端执行引擎
微架构清晰划分为前端（取指/解码）和后端（寄存器重命名/调度/乱序执行/提交）。
- **整数执行**：3×通用ALU（simple/add/bitwise） + 1×复杂端口（multiply/divide，4-cycle latency）；分支可上2个ALU，最大1 taken branch/cycle。
- **浮点/向量执行**：双流水线FPU（FSU），FP32 FMA 2端口（128-bit）；FP64 quarter-rate；FP add/multiply单端口，5-cycle latency（FMADD整体7-cycle，FADD 4-cycle）；向量整数add 2-cycle，multiplier单端口。
- **Load/Store Unit (LSU)**：2×AGU；L1D hit load-to-use 4-cycle（+1–2 cycle indexed）；Store forwarding 6–7 cycle（跨16B边界+1–2 cycle）；支持并行load/store（16B对齐，无边界跨越）；硬件预取针对向量/标量优化。
- **调度与重命名**：PRF-based（Physical Register File），ROB规模适中，每个scheduler ~33 entries（ALU/Memory/FP/Vector独立）；Flag rename ~31 entries；支持move elimination等重命名消除，减少假依赖。
#### 缓存层级子系统
- **L1 Cache**：每核独占64KB指令缓存（I-Cache）+ 64KB数据缓存（D-Cache），4-way，64B line，ECC；L1D支持2×128-bit访问/周期（2 load或1 load+1 store）。
- **L2 Cache**：每核独占512KB private（同代ARM中容量较大），10-cycle latency，~20–32 bytes/cycle（L2→L1D单向）。
- **L3 Cache (LLC)**：单芯片共享高达64MB（平均每核1MB），按Cluster（4核）切片，Tag在Cluster、Data在NoC附近；带宽：4核Cluster ~21.7 GB/s；支持Shared/Private/Partition三种模式；在分区模式下~36周期（~4MB），接近容量>90周期；跨Cluster/跨Die延迟更高但优于早期公版。
- **dTLB**：32-entry fully associative，L2 TLB 1024-entry（11-cycle hit）。
**面向云负载的优化**：L3 Partition模式 + HCCS Home Agent（HHA）动态分配，减少跨核延迟；bufferless NoC + LSE原子操作 + 软硬件协同（NUMA-aware调度）。
### 4. 其他全量技术细节
- **功耗管理**：7nm工艺 + 自定义微架构，支持DVFS、C-states等，实现高能效。
- **安全性**：ARM TrustZone + 硬件加密加速 + 异构机密计算（部分型号）。
- **虚拟化**：完整ARM虚拟化扩展（EL2/EL3），支持KVM等。
- **RAS**：ECC全程、机器检查架构（MCA）、错误隔离。
- **生态**：OpenEuler、鲲鹏计算联盟（2000+伙伴），GCC/Clang/LLVM针对tsv110优化。
- **演进**：Kunpeng 920是基础，后续920s/R25等基于相同TSV110微架构小改款。
### 总结：设计取向
鲲鹏920走的是Scale-Out（横向扩展）路线：不追求单核高频，也不像x86那样堆超宽浮点向量单元，而是以高能效的4-wide TaiShan V110单核微架构、64核阵列、8通道DDR4内存、100G RoCE网络和PCIe 4.0/CCIX，面向云计算、分布式存储和大数据吞吐量设计。
其目标是在单一7nm芯片上实现高并发吞吐量：云原生、数据库、分布式存储等场景下表现出色，部分超过同时期x86中端产品，能耗更低。局限性：128-bit NEON在重度FP/HPC上弱于AVX-512；极端共享场景L3一致性开销仍存；分支预测/ROB规模不及同期顶级x86/Neoverse N1。它验证了华为在7nm Chiplet、自主微架构、软硬协同上的能力，后续Kunpeng 930等以此为基础。
