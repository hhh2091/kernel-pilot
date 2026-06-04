# teco-T1

#### T1的芯片架构，硬件特性，使用技巧

![Drawing 0](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/c01cdb7f-7af3-4659-9da5-00d7f46e3282.png)

![Drawing 1](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/9318ebcf-821b-41fc-9d99-5b4d1d40d451.png)

![Drawing 2](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/d1e20ec4-7153-414e-90a1-f524d00cbc1f.png)

![Drawing 3](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/785b8885-f9b0-4fbc-b379-d2fc14d3dbdd.png)

1.  **Mesh网络**
    

![Drawing 4](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/5f491f4a-769a-4706-b73b-3d77631c2fb5.png)

如果想要用好T1的RMA和DMA，那就必须深入了解T1的整个Mesh网络结构，整个网络由DMA引擎，从核，路由，双工连线四部分组成。

*   DMA引擎: DMA引擎指负责把通过DMA把数据从HBM上搬运到Mesh网络上，当数据上网后，其数据的传输本质和RMA上网的数据没有区别，因此DMA和RMA会在这里发生带宽抢占。
    
*   从核：虽然上图画的是从核，但是本质还是可以理解为从核的LDM，需要注意从核到路由之间的连线，这条线很容易成为卡点，同时也要注意LDM本身为双Bank，半双工。
    
*   双工网线：整个Mesh网络位宽为256bit，主频和从核主频保持一致为2.5GHZ，因此整个Mesh网络的极限性能为
    
    2.5GHZ\*256bit/8=80GB/s(双工)，但网络上整个包的组成为1包头，4包身。因此用户可用的Mesh网络总带宽为
    
    80GB/s\*4/5=64GB/s(双工)。
    
*   路由：目前对于路由的了解较少，根据测试未发生路由转发会成为瓶颈，但实际上其路由的仲裁策略未深入了解。
    

下图以0号从核往4号从核发送数据为例，此时数据先从0号从核的LDM通过第一段的网线上路由，然后由路由一直往右转发，最后在4号从核链接的路由上下网，传输到4号从核的LDM。此时如果0号从核同时再DMA PUT数据，则会在0号从核到第一段网线的这里发生上网方向的冲突；如果此时0号从核同时在DMA GET数据，则不会冲突，因为DMA GET的数据在下网，RMA传输的数据在上网，双工并不冲突。

![Drawing 5](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/30a7044f-2f1e-4cc8-800c-98a92a2ea1de.png)

1.  **HBM2**
    

HBM==High Bandwidth Memory 是一款新型的CPU/GPU 内存芯片（即 “RAM”），其实就是将很多个DDR芯片堆叠在一起后和GPU封装在一起，实现大容量，高位宽的DDR组合阵列。

*   Vender：三星
    
*   容量：16GB（单个核组而言）
    

![Drawing 6](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/ae31a737-abe3-43e1-a911-6256dc9293be.png)

HBM内部结构：

*   通道：共8个物理通道，每个通道引脚完全独立，每个通道128bit。每个通道分为两个伪通道（HBM2开始引入伪通道模式，基本所有产品都会打开），所以共有16个通道。
    
    HBM2的典型 tFAW=20ns，若每个行激活耗时5ns，则前4次激活占满20ns窗口，第5次激活需等待至窗口末尾，产生额外15ns的等待时间。HBM2通过 ​**伪通道设计** 将每个物理通道（128位）拆分为两个独立的64位伪通道，共享行/列命令总线但独立执行操作。这一设计可绕过tFAW限制的原理如下：
    
    *   伪通道的独立性：每个伪通道拥有独立的行激活计数器。例如，在一个物理通道内，两个伪通道各自遵守tFAW规则，但它们的计数器互不影响。
        
    
    *   总激活次数提升：在同一个 tFAW 窗口内，两个伪通道合计允许激活 4×2=8 次行操作，而传统单通道仅允许4次。
        
*   Bank：共32个Bank，又均匀分成8个BankGroup，每个BankGroup中4个Bank。BankGroup间基本并行， BankGroup内切换Bank会有少量切换开销。
    
    ![Drawing 7](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/b8e286d7-c487-4567-a91b-a9888428d4ce.png)
    
*   行：每个Bank中有很多行，并且有一个行缓冲（类似于CPU的Cache），切换行的时候需要重新读入行缓冲，有较大的开销。
    
*   列：每行由很多列组成，最后5位即32B是最小粒度，也即DRAM的预取长度。
    

每个HBM DRAM stack最多支持8个channel，每个channel都是独立运作的（有自己独立的clock、control interface和IO port），且每channel的数据位宽固定为128bit（这样，8 \* 128bit = 1024bit恰好就是HBM DRAM stack允许的最大DAQ bus width）。

按照DRAM的硬件层次关系，**Bank Group切换的成本 <** **channel切换的成本 < column切换的成本 < bank切换的成本 < row切换的成本** 。这是因为不同channel是可以同时独立工作的，因此连续两个访存请求被映射到不同channel上，无非是让两个channel同时工作而已，几乎是没有额外成本的；column的切换需要进行两次column select，因此延迟更高一些；bank切换要重新进行bank选通、row和column选通，但是由于只有bank发生了切换，所以不涉及row active操作；最后，row切换时，需要芯片先重新进行bank选通、row和column选通，再对新的row进行row active和precharge，然后才能进行访问，这个延迟是最高的。

和Nvidia GPU上shared memory的bank概念不同，HBM地址映射规则中暴露的bank并不严格对应物理上的bank。如上所述，每个PC实际上都是由若干bank构成的，而HBM2由多个PC构成。同一个PC内的不同bank不能同时工作，但不同PC由于天然就被设计来并行，因此不同PC内的bank是可以并行的。

*   HBM地址映射
    

![Drawing 8](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/644a4205-7fad-48d8-ac7e-66d3767f5e59.png)

![Drawing 9](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/c01474a5-8d8e-4e86-aa64-16156fca6b44.png)

（1）这里看到page size per PC = 1kB，也就是row size = 1kB，简单来看，一个PC的IO port = 64bit = 8B，BL = 4，而column address有5位，所以row size per PC = 8B \* BL \* 2^5 = 1kB，似乎也不是个很大的size。

（2）一个channel含有2个PC，所以一个channel的burst4就是128bit \* BL4 = 512bit = 64B，或者说，访问对齐的连续64B的性能一般会非常好。

（3）HBM2的实际最小访存单位其实就是一个channel中两个PC的Burst，即2 \* (64bit \* BL=4) = 2 \* 256bit = 64B。

根据HBM的工作原理，理论上应该让访存落在所有PC上，同时每个PC以32B的最大位宽工作，此时能达到最佳带宽。

（1）访存的最小粒度是32B，且地址对齐到32B的整数倍

（2）访存地址能分成若干组，每一组覆盖channel address和pseudo-channel address的全部，由于HBM2有8个channel，2个PC，因此这样一组最少需要包含对8\*2\*32B = 512B的访问。

### HBM地址映射解析与设计意义

HBM的地址映射采用**非连续位段分配**和**层级交错策略**，核心目标是**最大化并行性、减少资源冲突、适配高带宽传输**。

#### 1. ​列地址（CA）的非连续分配\*\*

*   ​**PA\[5:6\] → CA\[1:2\]**
    
*   ​**PA\[12:14\] → CA\[3:5\]**
    
    *   ​**设计意图**：
        
        *   ​**分段突发传输**：低位CA（CA\[1:2\]）用于突发传输块内的偏移（如每块16字节），高位CA（CA\[3:5\]）选择更大的数据块（如64字节）。
            
        *   ​**适配宽总线**：HBM的1024位总线需一次性传输128字节数据，分段列地址允许控制器灵活调度多个突发块。
            
    *   ​**示例**：
        

若突发长度为16字节，CA\[1:2\]选择块内偏移（0~3），CA\[3:5\]选择更大的数据块索引（0~7），总寻址范围覆盖128字节。

#### 通道（CH）与伪通道（BA\[4\]）​

*   ​\*\*PA\[7:9\] → CH\[0:2\]\*\*​（3位，支持8通道）
    
*   ​\*\*PA\[10\] → BA\[4\]\*\*​（伪通道标识）
    
    *   ​**设计意图**：
        
        *   ​**伪通道模式**：每个物理通道拆分为2个逻辑伪通道（BA\[4\]=0或1），每个伪通道独立计数激活命令（绕过tFAW限制），将单通道激活次数从4次提升至8次/窗口。
            
        *   ​**通道级交错**：连续地址自动分散到不同通道（CH\[0:2\]），避免单一通道带宽瓶颈。
            
    *   ​**示例**：
        

地址递增时，CH\[0:2\]周期性变化（如CH0→CH1→CH2…），同时伪通道（BA\[4\]）交替激活，提升有效带宽。

#### Bank组（BG）与Bank（BA）的交错分配

*   ​**PA\[11\] → BA\[2\]（BG组内标识）​**
    
*   ​**PA\[17\] → BA\[3\]（BG组间标识）​**
    
*   ​\*\*PA\[15:16\] → BA\[0:1\]\*\*​（Bank ID）
    
    *   ​**设计意图**：
        
        *   ​**Bank组级交错**：Bank组（BG）地址分散在PA\[11\]和PA\[17\]，强制连续地址访问不同Bank组，规避时序限制（如tRRD/tFAW）。
            
        *   ​**Bank级并行**：同一Bank组内的多个Bank（BA\[0:1\]）可交替激活，隐藏预充电延迟。
            
    *   ​**示例**：
        

若PA\[11\]和PA\[17\]共同编码4个Bank组（BG0~BG3），地址递增时Bank组轮换，确保同一组内的Bank不连续访问。

#### 行地址（RA）高位扩展

*   ​\*\*PA\[19:33\] → RA\[0:14\]\*\*​（15位行地址）
    
    *   ​**设计意图**：
        
        *   ​**大容量支持**：15位行地址支持32K行/Bank，单Bank容量达32K×2KB（假设行大小2KB）=64MB，8层堆叠则为512MB/堆栈。
            
        *   ​**行缓冲优化**：连续地址映射到同一Bank的不同行，提高行缓冲命中率（Row Buffer Hit），减少激活延迟。
            

#### 堆栈/子通道标识（SID BG）​

*   ​**PA\[18\] → SID BG**
    
    *   ​**设计意图**：
        
        *   ​**多堆栈扩展**：标识不同堆栈或子通道（如4堆栈系统），支持更大总容量和聚合带宽。
            

### 设计优势总结

1.  ​**并行性最大化**：
    
    *   通道（CH）、Bank组（BG）、Bank（BA）的交错分配，使连续地址访问分散至多层级，8通道+4Bank组+4Bank实现高并发。
        
2.  ​**冲突规避**：
    
    *   伪通道（BA\[4\]）和Bank组分散降低Bank冲突概率，规避时序限制（tFAW/tRRD）。
        
3.  ​**突发传输适配**：
    
    *   列地址分段匹配HBM宽总线，优化数据块调度效率。
        
4.  ​**容量与扩展性**：
    
    *   行地址高位扩展支持大容量，SID BG标识实现多堆栈扩展。
        

![Drawing 10](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/e17f4059-4b60-4e20-b0ee-5b4de02da406.png)

地址低7位为一个通道，后面4位是通道号，也就是一共16个通道，每个通道负责128B。每个通道内部可以理解为一堆128B对齐的地址队列，这些地址序列会按照16个Bank展开，不同Bank访问时候是并行的。Bank内部访问会先打开一行，然后读取数据；如果接下来的访问请求在另一行，就需要关闭当前行打开新的行，效率很低。

总结一下HBM在读写时有以下特性：

*   通道间并行
    
*   Bank间并行
    
*   行间串行
    

结论：应该尽可能的保证访问HBM地址时通道和bank打满，但是不跨行，就可以获得不错的DMA读写性能。

低19位为同一行，所以需要控制32个从核同时访问的地址尽量不超过512KB，也就是每个从核访问数据量控制在16KB以内，这要求我们**在进行数据划分的时候使用周期划分而不是块划分**。另外，由于不同通道访问是完全并行的，每个通道内部的Bank也是并行的，所以为了不浪费通道和bank，我们需要使用至少低18位的地址空间，也就是256KB，平均到32个从核就是8KB；**因此DMA每个从核访问的数据量应该是在8-16KB之间性能达到最优。**

*   **访存视角**
    

我们在进行数据划分时，应该**以整个核组视角去看待32个从核共同访问的HBM地址空间**，而不是关注于单个从核的访存地址空间。

从接口的视角不带跨步的接口是访问连续的HBM地址空间，带跨步的接口是访问的不连续的地址空间；但是从核组的视角去看DMA数据访问的连续性就可能不一样了。

**不带跨步接口的不连续访存**

![Drawing 11](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/072c6b3c-bfdb-4f9b-96f8-e53d31d49e3a.png)

上面的地址分布是典型块划分的访问分布，虽然每个从核单独访问的地址空间是连续的，但是整个核组同时访问的地址空间就是不连续的，不连续的访存可能带来通道未被打满以及同时访问的地址空间跨行等低效的访存结果。

**带跨步接口的连续访存**

![Drawing 12](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/54b387b4-ac4f-4dcc-86e8-f8f4d552292a.png)

虽然使用了跨步接口访存，单个从核访问的每个小数据块之间都跨越了31个小块，但是miss的数据块同时都被其它从核所访问，整个核组视角来看同时访问的HBM地址空间是连续的。

这给我们的启示是使用跨步接口访存时中间miss的部分尽可能用其它从核的访问空间来填满，以防止中间存在miss的通道；如果具体场景不能保证miss的地址被填满，尽可能的让单个核组访问的连续地址块大小不小于1KB，防止有DMA通道未被利用。

1.  **Bank**
    
    分左右两个bank
    
    ###### Bank的定义
    
    Bank: 一个二维存储矩阵，包含行和列。单个Bank有若干行和若干列，一行一般存储着连续的几KB数据。
    
    Rank：一个Rank由一组Bank组成（一般来说1个Rank包含8个Bank），同一个Rank里面的Bank能同时访问，称为Bank级并行性(Bank Level Parallelism BLP)
    
    访问DRAM Bank的地址包括行地址和列地址，由DRAM控制器上的行地址选通脉冲RAS（Row Address Strobe）和列地址选通脉冲CAS（Column Address Strobe）来选择行地址和列地址，处理器的访存请求会被映射到DRAM Bank上，然后在Bank内分别以行访问和列访问选中二维存储矩阵中的一个单元（Cell），然后就可以进行读写数据了。
    
    在现代DRAM结构中，++每一个Bank都包含一个行缓冲（Row Buffer），Bank的Row Buffer是整个访存操作过程中的核心部件，只有将数据读入到行缓冲才能进行读写操作。访存时，先通过行地址确定Bank中的一行，然后将选中的行的所有内容缓存到Bank的Row Buffer里，最后通过列译码器译出列地址在Row Buffer中的某一列，读取cell里面存储的内容。++Row Buffer对Bank中的数据起到了缓存的作用，如果下一次访存操作的行地址与上一次一样，那么直接通过列地址从Row Buffer中读取数据（局部性原理），这样的操作加快了访存速度，降低了访存延迟。
    
    ###### 内存访问时在Bank上的流程
    
    可以分为4个阶段，分别为译码、Bank读写、Bank数据缓存、数据传输。4个阶段所涉及的硬件资源是不同的，分别对应于地址总线和命令总线，内存Bank，行缓冲和数据总线，因此4个阶段可以形成一条流水线。
    
    译码: 命令发出后经命令总线和地址总线传动到译码器中，译码器进行译码操作，获得行地址和列地址，以及即将访问的Bank。
    
    读写Bank: 将数据从Bank读取到Row Buffer里，或者将Row Buffer里的数据写会到Bank里。
    
    Bank数据缓存: 缓存同一Rank内同时工作的Bank行，充分利用Bank级并行性。
    
    数据传输: 将DRAM中的数据通过数据总线传输给LLC。
    
2.  **DMA**
    

![Drawing 13](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/732c1f81-a6a7-4e0e-9c61-e9e552461f1b.png)

*   一共有8个DMA engine。同一列的从核，公用一个DMA engine，即DMA engine和列绑定在一起。
    
*   同列从核公用一个DMA引擎，DMA有4个单独的线，与4个从核分别相连。因此发送请求时，4个从核优先级一致。
    

但数据返回时，DMA与RMA通信共用一条线路。

*   每个DMA engine在同一时刻最多只能使用2个HBM通道（4~5个DMA可把HBM带宽打满），因此，只有当所有8个DMA engine同时工作，并且每个engine使用不同的HBM通道时，DMA的带宽才能达到理论极限。
    
*   DMA 引擎将数据拆分成 128B 大小的包，以全列交叉的形式输入到 PPU 一致性处理
    
    ![Drawing 14](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/9cc98028-03d7-4157-a2cd-9f7cb93ba7cc.png)
    
*   进入 PPU 后的视角均是 **128 B 包**，因此 4B 的数据请求 和 128B 的数据请求 效率一致，且特别要注意地址128B 对齐； 且 PPU 和 DMA 不会对访问请求做合并 （核1访问64B，核2访问64B，不会合并为一个请求，带宽只有50%）
    
*   MC模块（memory control）有16个并行的 Channel， 最好 PPU 的访问可以是 128B \* 16 = 2K，占满带宽。
    
*   每个 Channel 内 16 个 bank 完全并行，每个 Bank 约处理 32B 数据
    
*   Bank 下的数据读取按行进行 open 与 close 操作，行打开关闭的问题一次和两次有较大的区别
    

![Drawing 15](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/978ae2ae-5998-435b-b94f-6e7b305772d5.png)

*   DMA 访问主存时， 地址会按照 16 个通道（每个通道 128 B）散开，连续的 128B 地址对齐的 2KB 数据访问请求（集合所有的 DMA 访问而言）可以占满所有的通道, 每个通道内部又会按照16个 Bank 散开，不同 Bank 在访问的时候也是并行, Bank 按行进行访问
    
*   Map 到 Channel 的方法 **（地址 / 128B）% 16** 
    
*   要 HBM 性能好，需要控制 **32 个从核同时访问的地址尽量不超过 512 KB  （2KB \* 16 \*16）**
    
*   理论带宽计算：**1024 bit / 8 \* 3.2 Ghz = 409.6 GB/s \* 80% = 328 GB/s**
    
*   DMA引擎和HBM通道一一对应时，可以避开一些网络冲突导致的降速，此时能获得较好的带宽
    

采用 128B 为基本块，跨步为 1024B 的跨步访存来实现， DMA 引擎采用**奇偶交错**

即避免因交叉开关冲突导致的流量冲突掉速，应当把 DMA 引擎按照奇偶交错的重新编号，即 **(0, 2, 4, 6, 1, 3, 5, 7)**

硬件角度:

![Drawing 16](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/f3affa33-3695-4ea7-9fd2-b9840be340ca.png)

*   当 **单个从核单次访问的数据总量是4/8K时双缓冲读写带宽最高**
    

因此：设置每个从核搬运的数据量为 4KB

要想打满带宽，得考虑到 DMA硬件 bank 冲突的问题

所以设置跨步传输：单从核每次传输的数据规模为 bsize = 128B

![Drawing 17](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/aca45b30-c031-4243-8c42-ec8d5d8c1443.png)

如果同时发起几十次DMA请求，之后一起等待结束，DMA操作之间可能存在流水线，性能波动较大，尤其是在单个从核单次访问数据量较小的情况。比如每个从核单次读取256B的数据，最后的带宽可能达到250GB/s。

同时，对于DMA队列长度，经过测试发现DMA队列长度是11，当连续发起多次DMA请求时，发起第12次DMA请求的拍数要远高于前面的DMA请求拍数。并且读操作和写操作共用一个队列，这要求我们同时发起的DMA读写操作总数最好不超过11次。

1.  **RMA**
    

每个core作为网络上的一个节点，与网络存在一个一级连接，网络上传送的所有数据要进/出core都必须经过一级连接

一级连接同样是双工的，意味着一个core可以同时执行从网络中读和写两种操作而不互相干扰。

一级连接的每个方向存在一个极限吞吐量，为25.6B/cycle（SPE主频为2.5GHz时，即为64GB/s），因此每个节点从网络上读或写的极限带宽不会超过64GB/s。

RMA广播过程中，一级连接的吞吐量最多只有极限吞吐的80%，只有在RMA点对点传输过程中，一级连接的吞吐量才可能达到极限带宽

RMA传输依赖：核间2D网络

RMA作用：核间通信

RMA模式：全双工

对于B矩阵：在同列从核上---->轮询RMA相比RMA列广播的优点

**点对点带宽高于列广播**（++128KB的数据，点对点58GB/s，行/列广播34GB/s++）

虽然说DMA和RMA是可以并行的，但是如果同时启动DMA\_get和RMA列广播，因为DMA\_get返回时和RMA公用一个通道，并行造成的问题就是可能会导致通道拥塞。

*   rma put
    

rma带宽在节点和路线都不冲突的情况下实测最高带宽为63GB/s， 节点冲突或者路线冲突都会降低带宽。

节点只发不收（无线路冲突），63GB/s；

![Drawing 18](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/fcad6eec-07ff-4bdd-9a1f-2134c9dc079c.png)

节点有发送和接收（无线路冲突），53GB/s；（**初步猜测是由于LDM到网线中间还有个控制器(LDM的位宽是512bit，而Mesh网络位宽为256bit。)，当一个节点同时存在上网和下网的操作时，这里会存在一个隐式的瓶颈。**）

![Drawing 19](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/4a2ac09a-58cd-4426-80ba-c54726478d76.png)

节点有发送和接收（有线路冲突），31GB/s；

![Drawing 20](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/5bef621a-1b27-4c90-9b06-fca133e61485.png)

rma\_get性能在有些场景下(如ring，场景一)的性能小于rma\_put， 建议使用rma\_put操作。

**列广播测试**

![Drawing 21](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/855df7ce-e27c-483a-8be5-007ec4953bdb.png)

说明：列广播的总数据量需要乘上列数8，并且**8个DMA引擎都利用上了，因此只要广播的数据量合适，带宽不会特别低**，并且带宽与对角线从核进行列广播差不多。

**行广播测试**

![Drawing 22](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/e20d03d0-93bc-41d2-8ff1-7764712bf50b.png)

说明：行广播的总数据量需要乘上行数4，由于**行广播过程中仅使用了一个DMA引擎****，所以带宽较低**，可以通过使用对角线从核来进行行广播进行优化。

**双对角线行广播**

考虑到对角线行广播仍未利用起所有的DMA引擎，所以这里将每行要广播的数据切分成两份，交由两列不同的从核分别进行广播，一次提高访存带宽。

![Drawing 23](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/08d93475-9865-40d4-99d5-9484748163bb.png)

![Drawing 24](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/444cb129-a9fa-49d8-b65f-24edfe80ac8c.png)

说明：每行要广播的数据交由两个从核分别进行广播，**利用起了所有的DMA引擎，带宽也与列广播接近了**。

**跨步列广播**

通过上面测试发现，普通的列广播八个通道都利用上了，并且整个核组访问的数据总量为128\*8K时，带宽仅为182GB/s，而普通的dma\_get操作单核组访问1024K，也就是每个核组访问32K时，带宽为230GB/s，存在不小的差距，现在模仿dma\_get的访存模式，对跨步广播接口进行测试。

测试固定了stride=7\*bsize，调整bsize发现bsize=256B时性能最优。

![Drawing 25](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/e06855d9-e5d3-40ba-aa5f-9003f2070fac.png)

可以发现，只要单次跨步列广播的每列广播的数据量不小于8K，整体带宽是明显高于普通列广播的。

通过上面的测试可以得出以下结论：

*   采用传统DMA访存模式时，单从核应连续访问8KB时性能最佳。
    
*   采用300GB/s的访存模式时，单个从核单次的访问总量可以根据实际情况，在（4K、8K、16K、32K、64K、128K）当中选择带宽最高的参数。
    
*   行广播操作如果性能不理想可以使用双对角线从从核进行行广播来优化，全广播操作谨慎使用。
    

1.  **LDM**
    
2.  **ACE**
    
    ![Drawing 26](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/5d659df8-948c-4963-9099-66b8cc7ebef2.png)
    
    ![Drawing 27](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/d0b4136d-ed5e-4fa7-9683-382381aca8f6.png)
    
    调用rt\_ace\_load\_west时会同步进行乘加计算，不用调用计算指令
    
    累加器缓冲区包含两个128\*32\*2B=8KB的缓冲区，分别为0和1。同一时刻，两个缓冲区一个在用一个空闲，可以通过rt\_ace\_writeback将空闲缓冲区的结果写回LDM中，从而**实现计算和数据写回的双缓冲功能**，以减少数据写回带来的延迟。西向数据加载指令包含多个标志位，用以标识是否切换累加器缓冲区，累加结果的起始位置的等。
    
    ACE的频率为1.25GHz，理想情况下，西向每个cycle获取64B的数据，折算成数据带宽为1.25Ghz\*64B=80GB/s；
    
    理论上北向需要的带宽也为80GB/s，但在实际计算时，西向的数据量为128\*32B，北向的数据量为32\*32B，西向和北向的数据加载可以重叠，使得北向实际需要的带宽会被拉低；当西向为128行时，北向的等效带宽需求为80GB/s / 4 = 20GB/s；
    
    ![Drawing 28](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/f67fe23d-19cb-446f-baca-5b0a25d348b1.png)
    
3.  **EBOX:** **SIMD**
    
    simd 由 EBOX执行。
    
    分为两条流水线，p0，p1。大致上分为了访存和计算。
    
    一共有32个向量寄存器，每个寄存器宽度为 512 bit，可以同时处理 16 个 FP32、 16 个 FP16、 16 个 int、 32 个 short。
    
    SIMD寄存器为512bit，在SIMD指令完全流水的情况下，需要的带宽为512bit/8\*2.5G=160GB/s；
    
4.  **寄存器**
    

![Drawing 29](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/713222e8-bb4f-4412-af5f-fd5c1bf5124c.png)

*   一共有 64 个通用寄存器，分为标量 32 个， 向量 32 个
    
*   向量寄存器为 512 bit 
    
*   指令异步（流水）
    

所有的指令都是异步发射的，在没有依赖的条件下，后一条指令不需要等待前一条指令完成就能发射。

假设硬件上的每条指令都需要取指(IF), 指令译码(ID), 执行/有效地址(EX), 储存器访问(MEM), 写回(WB)这5个周期完成。在指令直接完全不存在数据冒险(**上面展示的SIMD代码中就存在数据冒险，****c16 = a16 + b16****指令需要依赖****simd\_load(a16, a+i)****和****simd\_load(b16,b+i)****的完成****)**的前提下，指令本身会形成指令流水。具体如下图所示，cycle=1的时候第一条指令发射，cycle=2的时候第二条指令发射同时第一条指令处于ID阶段。因此只要指令流水够长则平均每条指令的执行时间接近1 cycle。

![Drawing 30](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/4da93b99-dbe2-4c22-9192-7eb56fdcc06a.png)

*   指令双发射
    

下面代码平均每次执行为248个cycle，实际计算指令总数为1024/128\*32=256条指令，除了计算指令外，循环内部还有循环处理和地址偏移处理，按理说实际指令应该大于256cycle，但实测的cycle数却小于256。这个是因为T1架构支持指令双发射，load/store和计算指令是在两条指令流水上，根据此特性可以进一步调整SIMD代码进行优化。

![Drawing 31](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/bd790153-6ca5-4840-9149-c6ee66af800f.png)

![Drawing 32](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/0b2a82fb-1953-4c5a-a8ff-241f66905b9e.png)

1.  **编程模型**
    
    1.  核心组件
        
        1.  数学库，正对指数、对数、正弦、余弦、正切、高斯误差等计算
            
    2.  执行模型
        
        1.  提供了 threadIdx（SPE的ID号）和threadDim（SPA中SPE总数）为每个SPE定制计算任务
            
        2.  核函数\_\_global\_\_关键字定义kernel，kernel<<<1>>>(args)
            
        3.  \_\_device\_\_关键字
            
        4.  \_\_local\_\_，修饰存放在SPM存储空间的变量，只能作为全局变量使用
            
        5.  sync\_thread: 对同一计算核心阵列SPA内的所有或者部分计算核心SPE进行同步操作
            
            1.  sync\_threads()：对同一计算核心阵列SPA内的所有计算核心SPE进行同步操作。
                
            2.  sync\_threads(const unsighed long \*thead\_group, unsigned int thead\_group\_size)
                
        
                                    对同一计算核心阵列SPA内指定的计算核心SPE进行同步操作。
        
    3.  性能优化关键
        
        1.  负载均衡：每个SPE承担的计算量尽可能保持一致。
            
        2.  数据就近原则：SPE内部用于计算的原始数据尽可能来自于当前SPE、减少同一计算核心阵列SPA内不同计算核心SPE之间的数据传递。
            
    4.  内存管理
        
        1.  函数栈空间16KB
            
        2.  使用malloc和free管理的空间235KB
            
        3.  使用\_\_local\_\_关键字声明的变量空间2656B，不支持变量初始化
            
        4.  其它为编译器内部使用
            
    5.  数据传输
        
        1.  主机端内存与Global存储空间，sdaaMemcpy
            
        2.  同一核心内部，memcpy
            
        3.  Global与spm空间之间的内存传输，dma，跨步/连续/同步/异步，带转置
            
        4.  不同计算核心之间的数据传输，rma，同步/异步，
            
        5.  行/列广播，单点广播，支持掩码自定义SPE组广播，阻塞/非阻塞
            
    6.  sdaa runtime接口
        
        1.  sdaaSetDevice：指定一个核组的重核计算阵列
            
        2.  sdaaMalloc/sdaaFree：申请/释放设备端内存
            
        3.  sdaaMemcpy：数据传输
            
    7.  向量操作
        
        1.  转入/存储，simd\_load/store，simd\_loadu/storeu
            
        2.  比较选择类，simd\_seleq/simd\_selle/simd\_sellt
            
        3.  元素操作，simd\_concat 拼接、simd\_ins 向量插入
            
        4.  数据类型转换
            
        5.  算数运算类/比较类，如加减乘、对数、指数、查表
            
        6.  向量数据类型：intv16、uintv16、shortv32，ushortv32、float16v16、floatv16
            
    8.  tecocc编译器、性能采样、调试
        

![Drawing 33](https://alidocs.oss-cn-zhangjiakou.aliyuncs.com/res/jP2lRYjVaZoxLO8g/img/725c4de2-e6fe-46d1-9428-519d36dcb272.png)