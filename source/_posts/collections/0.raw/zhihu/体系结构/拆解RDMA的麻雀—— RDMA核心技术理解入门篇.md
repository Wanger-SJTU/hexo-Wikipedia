---
title: 拆解RDMA的麻雀—— RDMA核心技术理解入门篇
date: "2026-04-13 00:00:00"
updated: "2026-04-13 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/体系结构/拆解RDMA的麻雀——-RDMA核心技术理解入门篇-cfe479/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://zhuanlan.zhihu.com/p/2026410347519583363
---


### 1. 导语

本文主要通过一个具体的程序示例，详细拆解RDMA访问远端主机内存的过程。并透过和TCP/IP访问通路的详细对比，具体解释RDMA 的四大核心技术：内核旁路、零拷贝、CPU 卸载和直接访问，如何分别提升远端内存访问的性能

写这篇文章的原因是，记录下笔者基于实际工程的具体范例，直观理解所使用技术的原理的过程。后续也希望能写成一个专栏，把AI互联相关的内容，都以具体工程范例的方式，逐步拆解，将抽象的技术讨论具体化。既不深陷具体技术的细节，也不虚空讨论技术概念。希望能帮助到有同样困惑的学习者们

关于 RDMA 的技术专栏，先上我阅读过的，知乎上经典/内容比较丰富的几个相关专栏

最经典最全面的RDMA专栏毋庸置疑

[![](/images/collections/0.raw/zhihu/%25E4%25BD%2593%25E7%25B3%25BB%25E7%25BB%2593%25E6%259E%2584/asset/img_07625d38ba64.jpg)RDMA杂谈Savir 的专栏26 篇内容 · 6610 赞同 · 1453 订阅](https://www.zhihu.com/column/c_1231181516811390976)

  涵盖RDMA/CPU/分布式，帮助理解RDMA具体应用场景

[![](/images/collections/0.raw/zhihu/%25E4%25BD%2593%25E7%25B3%25BB%25E7%25BB%2593%25E6%259E%2584/asset/img_1d21ea2ca48b.jpg)RDMA & 高速网络进击的Bruce 的专栏7 篇内容 · 1061 赞同 · 135 订阅](https://www.zhihu.com/column/c_1710765963216084992)

讨论各类技术的设计思想，这里面对RDMA context的存在理由的讨论文章我很喜欢

[![](/images/collections/0.raw/zhihu/%25E4%25BD%2593%25E7%25B3%25BB%25E7%25BB%2593%25E6%259E%2584/asset/img_43e03fe87da5.jpg)设计思想fan wang 的专栏24 篇内容 · 470 赞同 · 29 订阅](https://www.zhihu.com/column/c_1763644615318777857)

内容丰富，更新快，适合追踪技术热点

话不多说，直接上正文

关于 RDMA 的技术核心，不多做赘述，一句话：

RDMA让网卡绕过操作系统内核，直接在用户内存间搬运数据，实现零拷贝和 CPU 卸载

四点主要核心技术

- Kernel Bypass (内核旁路)： 绕过操作系统内核。
- Zero Copy (零拷贝)： 数据无需在内存中复制。
- CPU Offload (CPU卸载)： CPU不参与数据移动。
- Direct Access (直接访问)： 网卡直接访问用户内存，这既涉及到网卡DMA的技术，也包含TCP/IP硬件卸载
这四项核心技术具体解决了什么问题，对远端内存访问的性能提升分别有怎样的贡献，下面通过一个简单的 RDMA 程序和 TCP/IP Socket 程序进行对比和逐步拆解，帮助读者理解 RDMA 上述四项技术具体做了什么

### 2. 程序对比

#### 2.1 TCP/IP（socket）程序

下面的示例代码是一个基于 socket 访问对端主机内存（即：没有 RDMA 的情况下访问远端主机内存的方案，作为 baseline）的具体案例，其中server是提供内存主机，client是发起访问的主机，

common 文件，定义两端约定的请求格式

`#define PORT 8080
#define BUFFER_SIZE 1024
//----------------- Step0. 准备工作 common -------------------------------------
//       1. 定义 request_t（两个主机约定的交换信息的数据格式）line7-15
//          包含 a. op:定义读/写; b.offset:目标内存偏移量；C.length:长度
//       2. 分配用户态内存，供远端主机读写 line 25-27
typedef enum {
    OP_READ = 1,
    OP_WRITE = 2
    } op_code_t;
typedef struct {
    op_code_t op;
    uint64_t offset;  // 模拟的内存偏移量
    uint32_t length;  // 数据长度
} request_t;`

server （内存提供）端代码，注释中解释了每个步骤的功能

`//----------------- Step0. 准备工作 Server -------------------------------------
//       分配用户态内存，供远端主机读写 line 10-12
int main() {
    int server_fd, client_fd;
    struct sockaddr_in address;
    int opt = 1;
    socklen_t addrlen = sizeof(address);
    
    //分配一块用户态内存，返回用户态内存指针
    char *remote_memory = (char *)malloc(BUFFER_SIZE * 10);
    memset(remote_memory, 0, BUFFER_SIZE * 10);
    strcpy(remote_memory, 「Default Data in Server Memory」); // 初始数据

    
//------------------ Step1. Socket 创建 ---------------------------------  
    //按照标准流程，创建 Socket，建立与对端（client）主机的链接 line 22-32
    if ((server_fd = socket(AF_INET, SOCK_STREAM, 0)) == 0) {
        perror(「socket failed」);
        exit(EXIT_FAILURE);
    }
    setsockopt(server_fd, SOL_SOCKET, SO_REUSEADDR, &opt, sizeof(opt));
    
    address.sin_family = AF_INET;
    address.sin_addr.s_addr = INADDR_ANY;
    address.sin_port = htons(PORT);

    bind(server_fd, (struct sockaddr *)&address, sizeof(address));
    listen(server_fd, 3);
    printf(「Socket Server listening on port %d...\n」, PORT);
    //最终返回 client_fd 句柄，后续 send/recv 使用该句柄交换数据 line32
    client_fd = accept(server_fd, (struct sockaddr *)&address, &addrlen);
    
    while(1) {
        request_t req;
//-------------------- Step2. 请求发送/接收 -----------------------------
     //通过 recv 函数，通过上一步建立 socket 返回的句柄，接收 server 请求
        int n = recv(client_fd, &req, sizeof(req), 0);
        if (n 

client（请求发送）端代码

`int main() {
//------------------ Step1. Socket 创建 ---------------------------------  
    //创建 Socket，建立与对端主机的链接 line 5-20
    //最终返回 sock 句柄，后续 send/recv 使用该句柄交换数据 line32
    int sock = 0;
    struct sockaddr_in serv_addr;
    
    if ((sock = socket(AF_INET, SOCK_STREAM, 0)) 

通过 TCP/IP，使用 socket 方式进行数据传输的步骤比较直观，总结下来就是一下三个步骤

Step1 建立连接：通过标准的 socket 编程，建立两个主机的链接

Step2 请求交换：通过 send/recv 系统调用，client 端主机发送请求，server 端接收

Step3 数据交换：

server 端解析 client 发送的请求，调用 recv 接收 client 发送的数据（写请求），或者调用 recv 给 client 发送数据（读请求）

client 端根据自身发送的请求，调用 send 给 server 发送数据（写请求），或者调用 recv 接收 server 发送的数据（读请求）

通过 TCP/IP 交换两个主机的主要痛点是多次的系统调用(代码中的send/recv)，除去 socket 建立和双方信息交换的 send/recv 外，每次执行数据读写时，两端主机都要至少两次 send/recv 调用。

从后面我们可以看到，使用 send/recv 通过传统 TCP/IP内核协议栈处理数据时，耗时非常大，耗时的来源主要在于上下文切换和CPU处理数据搬移和网络报文信息，这就是RDMA重点解决的问题

#### 2.2 RDMA程序示例

接下来我们再看一下使用 RDMA访问远端内存的的代码示例，

（注意由于 RDMA 上下文维护的代码比较多，为了便于理解整个 RDMA 数据传输的 pipeline，本文的代码采用了伪代码的模式，主要压缩了多个使用 ibv_modify_qp 对 qp 状态进行转换的代码，仅供概念理解。。。如果想要学习RDMA详细的代码，可以参考下面这篇文章，里面对RDMA代码进行了详细的解析 [RDMA极速入门和代码解析](https://zhuanlan.zhihu.com/p/1937158888345539198)）

common文件，定义两端主机交换QP信息的结构体

`#define BUF_SIZE 1024
#define MSG 「Hello RDMA Verbs RC!」

struct cm_data {
    uint32_t qp_num;
    uint32_t rkey;
    uint64_t raddr;
};
`

Server(内存提供端)代码

`MAIN():
//---------------Step1.1 建立 RDMA 需要的各项资源，包括 mr/cq/qp 等----------------
    // --- a 资源初始化 ---
    dev_list = ibv_get_device_list(NULL)
    ctx      = ibv_open_device(dev_list[0])
    ibv_free_device_list(dev_list)

    pd = ibv_alloc_pd(ctx)

    posix_memalign(&buf, ...)           // 分配对齐内存
    mr = ibv_reg_mr(pd, buf, BUF_SIZE, 
            IBV_ACCESS_LOCAL_WRITE | IBV_ACCESS_REMOTE_READ | IBV_ACCESS_REMOTE_WRITE)

    cq = ibv_create_cq(ctx, 100, ...)

    qp = ibv_create_qp(pd, &qp_attr)    // 创建 RC 类型 QP

    // --- b 状态机：RESET -> INIT ---
    ibv_modify_qp(qp, &attr, 
            IBV_QP_STATE | IBV_QP_PKEY_INDEX | IBV_QP_PORT)
        
//---------------Step1.2 通过 socket，交换 rdma 资源信息----------------
  
    // --- a 建立 socket 连接 --
        lfd = socket(...)
        bind(lfd, ...)
        listen(lfd, ...)
        cfd = accept(lfd, ...)
 
     //--- b 交换 QP 号、rkey、内存地址 --
        send(cfd, &local_cm_data, ...)
        recv(cfd, &peer_cm_data, ...)
    

    // --- C. 状态机：INIT -> RTR (Ready to Receive) ---
    设置 attr (dest_qp_num, path_mtu, ...)
    ibv_modify_qp(qp, &attr, 
            IBV_QP_STATE | IBV_QP_DEST_QPN | IBV_QP_PATH_MTU | ...)

    // --- d. 状态机：RTR -> RTS (Ready to Send) ---
    设置 attr (timeout, retry_cnt, ...)
    ibv_modify_qp(qp, &attr, 
            IBV_QP_STATE | IBV_QP_TIMEOUT | IBV_QP_RETRY_CNT | ...)

//---------------Step2 发送/接收请求，检查是否完成----------------
 

    // 步骤 1: 准备接收 SEND
    ibv_post_recv(qp, &recv_wr, &bad_wr)
    while (ibv_poll_cq(cq, 1, &wc) 

client （内存访问端）代码

`MAIN():
//---------------Step1.1 建立 RDMA 上下文(context)，包括 mr/cq/qp 等----------------
    // --- a 资源初始化 ---
    dev_list = ibv_get_device_list(NULL)
    ctx      = ibv_open_device(dev_list[0])
    ibv_free_device_list(dev_list)

    pd = ibv_alloc_pd(ctx)

    posix_memalign(&buf, ...)
    
    mr = ibv_reg_mr(pd, buf, BUF_SIZE, IBV_ACCESS_LOCAL_WRITE)

    cq = ibv_create_cq(ctx, 100, ...)

    qp = ibv_create_qp(pd, &qp_attr)    // 创建 RC 类型 QP

     // --- b 状态机：RESET -> INIT ---
    ibv_modify_qp(qp, &attr, 
            IBV_QP_STATE | IBV_QP_PKEY_INDEX | IBV_QP_PORT)
        
//---------------Step1.2 通过 socket，交换 rdma 资源信息----------------
  
    // --- a. 连接建立 socket 链接 ---
        fd = socket(...)
        inet_pton(...)                   // 填充地址结构
        connect(fd, ...)                 // 连接服务端 TCP
    //--- b 交换 QP 号、rkey、内存地址 --
        recv(fd, &peer, ...)             // 接收服务端的 QP 信息、内存信息
        send(fd, &local, ...)            // 发送本端的 QP 信息
    

    // --- C. 状态机：INIT -> RTR (Ready to Receive) ---
    设置 attr (dest_qp_num=peer.qp_num, ...)
    ibv_modify_qp(qp, &attr, 
            IBV_QP_STATE | IBV_QP_DEST_QPN | IBV_QP_PATH_MTU | ...)

    // --- d. 状态机：RTR -> RTS (Ready to Send) ---
    设置 attr (timeout, retry_cnt, ...)
    ibv_modify_qp(qp, &attr, 
            IBV_QP_STATE | IBV_QP_TIMEOUT | IBV_QP_RETRY_CNT | ...)

//---------------Step2 发送/接收请求，检查是否完成----------------

    // 步骤 1: SEND (双边操作)
    strcpy(buf, MSG)
    wr = {opcode=IBV_WR_SEND, sge=buf, flags=IBV_SEND_SIGNALED}
    ibv_post_send(qp, &wr, &bad_wr)
    while (ibv_poll_cq(cq, 1, &wc)  本地)
    memset(buf, 0, ...)
    wr = {opcode=IBV_WR_RDMA_READ, sge=buf, 
          remote_addr=peer.raddr, rkey=peer.rkey}
    ibv_post_send(qp, &wr, &bad_wr)
    while (ibv_poll_cq(cq, 1, &wc)  远端)
    strcpy(buf, WRITE_MSG)
    wr = {opcode=IBV_WR_RDMA_WRITE, sge=buf, 
          remote_addr=peer.raddr, rkey=peer.rkey}
    ibv_post_send(qp, &wr, &bad_wr)
    while (ibv_poll_cq(cq, 1, &wc) 

通过RDMA访问远端主机内存，主要有两个步骤，每个步骤的功能如下：

步骤一 RDMA 链路建立：这一步相比于 TCP/IP 要更加复杂一些，TCP/IP 只需要建立 socket 链接就可以了，而 RDMA 在链路初始化中最重要的工作是建立 RDMA 上下文（context）。

主要包括 PD（protection domain）/MR(memory region)/CQ(completion queue)/QP(queue pair)等，这些上下文主要通过调用 RDMA API（verb）建立。

这些上下文的功能概念可以参考开头 @Savir

的专栏内容，每一个都解释的很详细，后续也考虑通过代码拆解每个上下文的具体功能以及资源消耗

上下文建立好后，RDMA 需要交换双端的 RDMA 上下文信息，交换完成后，需要再进行一系列的 QP状态转换（INIT->RTR->RTS）,初始化完成后，就可以进入第二步，数据交换了

步骤二 数据交换:得益于 RDMA 针对内存操作的完整定义，这一步相比于 TCP/IP，系统调用/API 使用的复杂度大大减少

具体体现在单边操作如读/写（无立即数），使用 RDMA 可以只需要一端主机调用 API，另一端无需做任何操作

双边操作即执行 send/receive 语义，对于 client，将 opcode 设置为 IBV_WR_SEND，通过 ibv_post_send API 执行 send 请求，对于 server，直接通过 ibv_post_receive 执行 receive

这个底层原因包括RDMA的上下文定义及管理、CPU卸载，后面会详细展开

#### 2.3 数据访问step-by-step对比

到这里，我们再用一张图总结使用 RDMA 和使用 TCP/IP 进行跨主机内存访问的程序实现步骤

![](/images/collections/0.raw/zhihu/%25E4%25BD%2593%25E7%25B3%25BB%25E7%25BB%2593%25E6%259E%2584/asset/img_218c835cdec1.jpg)

从上图中可以看到，RDMA 与TCP/IP 的不同主要体现在

初始化阶段

- RDMA 比 TCP/IP 需要在用户态维护更多的上下文信息 ，包括建立 MR/CQ/QP 等，且要对 QP 进行显式的状态转换
数据传输阶段

- TCP/IP每次交换数据，都要两次 send/recv（step，request/data 传输各一次），而从后文的详细拆解中可以看到每次send/recv调用的代价都非常大
- RDMA 交换数据

- 双边操作仅需一次 ibv_post_send/recv，
- 单边操作可以仅发起端操作，server 端无感知

如前文所说，RDMA 对编程模型的简化，根本原因在于开头所说的内核旁路和CPU卸载，而这两点可以从 ibv_post_send 的执行过程上得到具体的体现。

下一章节就会比较使用TCP/IP和使用RDMA进行《数据传输》步骤的具体差别，即使用系统调用 send/recv 进行数据传输，和 RDMA 使用 ibv_post_send 进行数据传输的具体差别

### 3. 数据传输pipeline详细对比

下图展示一次数据传输中（比如 client 调用 send/ibv_post_send 发送数据，server 调用 recv/ibv_post_recv 接收数据），负责处理数据的软件，数据的物理位置搬移和过程中具体负责搬移数据的物理主体，来看一下RDMA使用内核旁路/零拷贝/CPU卸载和直接内存访问四项核心技术，具体解决了哪些问题

![](/images/collections/0.raw/zhihu/%25E4%25BD%2593%25E7%25B3%25BB%25E7%25BB%2593%25E6%259E%2584/asset/img_fcb5678f751b.jpg)

- 零拷贝/内核旁路优势体现：
TCP/IP 传递数据采用系统调用 send/recv，其相比于使用零拷贝的 ibv_post_send，代价主要体现在上下文切换，这包含了

- CPU 各类寄存器更新
- 数据在内核空间和用户空间之间的搬移（是存在实际内存中物理位置变化的）

具体调用一次 recv（）的代价，可参见下面文章 

[](https://zhuanlan.zhihu.com/p/2025137203928396831)

![](/images/collections/0.raw/zhihu/%25E4%25BD%2593%25E7%25B3%25BB%25E7%25BB%2593%25E6%259E%2584/asset/img_e02a3d79bbd1.jpg)

而 RDMA 调用 ibv_post_send 时，是完全不涉及上下文切换，我们以使用 mlx5 网卡的 rdma 为例，当调用 ibv_post_send 时，最终 driver 会调用 atomic_store_explicit函数（用户态函数），通过 MMIO 向网卡中的寄存器写数据（即敲 doorbell），网卡收到 doorbell 后，网卡 RDMA 会从主机内存中搬移数据出来。从上面对比图可以看到，这个过程完全不涉及上下文切换和数据搬移，因此CPU资源也大幅度减少,相应的处理时间差距接近一个数量级

具体调用 ibv_post_send 的函数调用链见附录（感慨一下 AI 工具的好用，当年零基础学习 driver 的时候对于这个 api 如何调用钩子函数，理解了 n 久。。现在就是几句 prompt 的事儿了，惆怅。。。）

另外啰嗦一点，并不是RDMA所有verb都不涉及到上下文切换，实际上纯运行在用户态的verb仅仅是少数几个执行大块数据传输的数据面verb，其他涉及到资源管理的控制面verb依然需要进入内核态，这也是非常合理且巧妙的设计，具体verb分类也可以参见开头的第一个推荐专栏

2. TCP/IP卸载/直接访问的优势体现：

当使用 TCP/IP 传递数据时，是由CPU执行内核中的网络协议栈处理，将要传递的数据打包成网络数据包的。而RDMA将这一过程放在了网卡中进行专用的硬件实现，既节省了CPU资源，也提升了性能。

另外相比于传统网卡，在数据发送过程中，RDMA 网卡内部的的 DMA 在被敲 doorbell 后，可以直接从主机的“用户内存”中搬移数据到网卡，传统网卡则需要从内核态缓冲区拿取数据。

在接收过程中，RDMA网卡内部的DMA在收到对端数据后，可直接将数据写入用户态内存，而传统网卡需要进行数据写入内核态ring buffer，中断CPU，CPU处理数据，切换为用户态，搬移数据等一系列操作，尤其对于中断唤醒CPU这一动作，造成的延迟抖动可能非常大，也是整个发送数据链路上延迟占比相当大的步骤

RDMA直接内存访问带来的这些优势，背后涉及到一整套地址转换与管理，权限甄别等技术，后续如果有时间精力考虑单独出一篇文章详细拆解数据经过网卡/主机的硬件pipeline

### 4.  How about CXL?

最后可以用一点点篇幅讲一下 CXL，因为使用 cxl 访问外部内存，从软件的视角看简单到有点无聊，由 CXL 连接的内存，在软件视角上看是一个 numa-node，直接当成内存用就好了，完全不需要额外的 api。。。这也是底层使用 load/store 语义与使用 read/write/send/recv 语义，在程序员视角上最直观的不同。

（当然背后是 intel 修改了 PCIe 二层协议，同时在自己 CPU系统开了口子，通过硬件处理掉了数据一致性，做完了所有脏活换来的，仗着生态耍流氓了属于是。。。）

### 5. 总结

总结：本篇文章用几段简单的代码，通过对具体程序和一次数据访问过程pipeline的详细拆解

- 把 RDMA 如何通过零拷贝（内核旁路）、网络处理卸载，简化了远端内存访问，具体且直观的反映出来
- 给初学者一个观感，使用 TCP/IP，RDMA和CXL的程序访问远端内存的程序长什么样子，作为理解send/recv， read/write 和 load/store 语义区别的一个起点

### 6. 附录

- ibv_post_send调用链（以mlx网卡驱动为例）
用户调用 ibv_post_send()

    ↓

libibverbs 通过 verbs_context_ops 查找函数指针

`static const struct verbs_context_ops mlx5_ctx_common_ops =
 {     
.query_port    = mlx5_query_port,     
.alloc_pd      = mlx5_alloc_pd,     
.async_event   = mlx5_async_event,     
.dealloc_pd    = mlx5_free_pd,     
.reg_mr        = mlx5_reg_mr,     
.reg_dmabuf_mr = mlx5_reg_dmabuf_mr,     
.rereg_mr      = mlx5_rereg_mr,     
.dereg_mr      = mlx5_dereg_mr,     
.alloc_mw      = mlx5_alloc_mw,     
.dealloc_mw    = mlx5_dealloc_mw,     
.bind_mw       = mlx5_bind_mw,     
.create_cq     = mlx5_create_cq,     
.poll_cq       = mlx5_poll_cq,     
.req_notify_cq = mlx5_arm_cq,     
.cq_event      = mlx5_cq_event,     
.resize_cq     = mlx5_resize_cq,     
.destroy_cq    = mlx5_destroy_cq,     
.create_srq    = mlx5_create_srq,     
.modify_srq    = mlx5_modify_srq,     
.query_srq     = mlx5_query_srq,     
.destroy_srq   = mlx5_destroy_srq,     
.post_srq_recv = mlx5_post_srq_recv,     
.create_qp     = mlx5_create_qp,     
.query_qp      = mlx5_query_qp,     
.modify_qp     = mlx5_modify_qp,     
.destroy_qp    = mlx5_destroy_qp,     
.post_send     = mlx5_post_send,  // 

    ↓ 

调用 mlx5_post_send (在 mlx5.c 中注册)

    ↓

执行 _mlx5_post_send (在 qp.c 中实现)

    ↓

构建 WQE 并调用 post_send_db

    ↓

通过 MMIO 写入网卡

最底层函数使用：atomic_store_explicit，为c11标准库函数，用户空间原子操作
